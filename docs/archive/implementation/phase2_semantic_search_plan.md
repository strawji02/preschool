# Phase 2: Semantic Embeddings 실행 플랜

> 보관 문서: 현재 운영 규칙은 AGENTS.md와 docs/systems/를 우선합니다.

> 작성일: 2026-02-07
> 목표: 의미 기반 검색으로 오매칭 문제 해결

## 📊 현재 문제

**Phase 1 결과**: Trigram + BM25 Hybrid 개선 효과 없음 (85점 유지)

**실제 오매칭 케이스**:
```
"프렌치버터롤오리지널모닝빵" → "오렌지" 매칭 ❌
                   ^^^^^^
                "오리지" ≈ "오렌지" (글자 유사)
```

**근본 원인**: Trigram은 글자 유사도만 보고, 의미(빵 vs 과일)를 이해하지 못함

---

## 🏗️ 아키텍처 설계

### 1. 임베딩 모델 선택

| 모델 | 차원 | 한국어 성능 | 크기 | 비용 |
|------|------|------------|------|------|
| **multilingual-e5-small** ⭐ | 384 | 우수 | 90MB | 무료 |
| intfloat/e5-large | 1024 | 최상 | 335MB | 무료 |
| KoSimCSE-roberta | 768 | 한국어 특화 | 440MB | 무료 |
| OpenAI text-embedding-3-small | 1536 | 우수 | API | $0.02/1M tokens |

**권장**: `multilingual-e5-small`
- 한국어 포함 100+ 언어 지원
- 384 차원으로 저장 효율적
- MTEB 벤치마크 상위권

### 2. Supabase 인프라 검증

**✅ 가능 (확인됨)**

| 항목 | 제약 | 우리 요구사항 | 상태 |
|------|------|--------------|------|
| pgvector | 무료 플랜 지원 | ✓ | ✅ |
| Edge Functions 메모리 | 512MB | ~200MB (모델) | ✅ |
| Edge Functions 타임아웃 | 150초 | ~5초/배치 | ✅ |
| Function 크기 | 20MB | ~10MB (ONNX) | ✅ |
| Vector 저장 | 제한 없음 | 24K x 384차원 | ✅ |

**⚠️ 주의사항**
- Edge Functions에서 ONNX 모델 로딩 시 cold start ~3-5초
- 무료 플랜: 월 50만 Edge Function 실행 (충분)

### 3. 임베딩 생성 전략

**Option A: Server-side (Edge Functions)** ⭐ 권장
```
User Query → Edge Function → ONNX Model → Embedding → pgvector Search
```
- 장점: 클라이언트 부담 없음, 모델 업데이트 용이
- 단점: cold start

**Option B: Client-side (브라우저)**
```
User Query → Browser ONNX → Embedding → Supabase RPC
```
- 장점: 서버 비용 없음
- 단점: 첫 로딩 느림, 모바일 성능 이슈

**Option C: Pre-computed + Hybrid**
```
Products: 미리 임베딩 저장
Queries: Edge Function에서 실시간 생성
```

---

## 📋 구현 단계

### Step 1: pgvector 설정 (30분)

```sql
-- supabase/migrations/019_pgvector_setup.sql

-- 1. pgvector 확장 활성화
CREATE EXTENSION IF NOT EXISTS vector;

-- 2. products 테이블에 embedding 컬럼 추가
ALTER TABLE products ADD COLUMN IF NOT EXISTS 
  embedding vector(384);

-- 3. HNSW 인덱스 생성 (빠른 검색)
CREATE INDEX IF NOT EXISTS products_embedding_idx 
  ON products 
  USING hnsw (embedding vector_cosine_ops)
  WITH (m = 16, ef_construction = 64);
```

### Step 2: Edge Function 생성 (2시간)

```typescript
// supabase/functions/generate-embedding/index.ts

import { serve } from "https://deno.land/std@0.177.0/http/server.ts";
import { pipeline } from "@xenova/transformers";

let embedder: any = null;

async function getEmbedder() {
  if (!embedder) {
    embedder = await pipeline(
      "feature-extraction",
      "Xenova/multilingual-e5-small",
      { quantized: true }
    );
  }
  return embedder;
}

serve(async (req) => {
  const { text, texts } = await req.json();
  const embed = await getEmbedder();
  
  if (texts) {
    // 배치 처리
    const embeddings = await Promise.all(
      texts.map(async (t: string) => {
        const result = await embed(`query: ${t}`, { pooling: "mean" });
        return Array.from(result.data);
      })
    );
    return new Response(JSON.stringify({ embeddings }));
  }
  
  // 단일 처리
  const result = await embed(`query: ${text}`, { pooling: "mean" });
  return new Response(JSON.stringify({ 
    embedding: Array.from(result.data) 
  }));
});
```

### Step 3: 상품 임베딩 생성 (1-2시간)

```typescript
// scripts/generate-product-embeddings.ts

import { createClient } from "@supabase/supabase-js";

const BATCH_SIZE = 100;
const supabase = createClient(/* ... */);

async function generateEmbeddings() {
  // 1. 임베딩 없는 상품 조회
  const { data: products } = await supabase
    .from("products")
    .select("id, product_name, normalized_name")
    .is("embedding", null)
    .limit(BATCH_SIZE);

  // 2. Edge Function 호출
  const texts = products.map(p => 
    `${p.product_name} ${p.normalized_name || ""}`
  );
  
  const { data } = await supabase.functions.invoke(
    "generate-embedding",
    { body: { texts } }
  );

  // 3. 임베딩 저장
  for (let i = 0; i < products.length; i++) {
    await supabase
      .from("products")
      .update({ embedding: data.embeddings[i] })
      .eq("id", products[i].id);
  }
}

// 전체 상품 처리 (23,866개 / 100 = ~239 배치)
// 예상 시간: 30-60분
```

### Step 4: Semantic Search 함수 (1시간)

```sql
-- supabase/migrations/020_semantic_search.sql

CREATE OR REPLACE FUNCTION search_products_semantic(
  query_embedding vector(384),
  limit_count INTEGER DEFAULT 5,
  supplier_filter TEXT DEFAULT NULL,
  similarity_threshold REAL DEFAULT 0.5
)
RETURNS TABLE (
  id BIGINT,
  product_name TEXT,
  normalized_name TEXT,
  supplier TEXT,
  unit_price NUMERIC,
  similarity REAL
) AS $$
BEGIN
  RETURN QUERY
  SELECT 
    p.id,
    p.product_name,
    p.normalized_name,
    p.supplier,
    p.unit_price,
    1 - (p.embedding <=> query_embedding) AS similarity
  FROM products p
  WHERE p.embedding IS NOT NULL
    AND (supplier_filter IS NULL OR p.supplier = supplier_filter)
    AND 1 - (p.embedding <=> query_embedding) > similarity_threshold
  ORDER BY p.embedding <=> query_embedding
  LIMIT limit_count;
END;
$$ LANGUAGE plpgsql;
```

### Step 5: Hybrid Search (Semantic + Trigram) (2시간)

```sql
-- supabase/migrations/021_hybrid_semantic_search.sql

CREATE OR REPLACE FUNCTION search_products_hybrid_v2(
  search_term TEXT,
  query_embedding vector(384),
  limit_count INTEGER DEFAULT 5,
  supplier_filter TEXT DEFAULT NULL,
  semantic_weight REAL DEFAULT 0.6,
  trigram_weight REAL DEFAULT 0.4
)
RETURNS TABLE (
  id BIGINT,
  product_name TEXT,
  supplier TEXT,
  unit_price NUMERIC,
  combined_score REAL,
  semantic_score REAL,
  trigram_score REAL
) AS $$
BEGIN
  RETURN QUERY
  WITH semantic_results AS (
    SELECT 
      p.id,
      1 - (p.embedding <=> query_embedding) AS score
    FROM products p
    WHERE p.embedding IS NOT NULL
      AND (supplier_filter IS NULL OR p.supplier = supplier_filter)
    ORDER BY p.embedding <=> query_embedding
    LIMIT limit_count * 3
  ),
  trigram_results AS (
    SELECT 
      p.id,
      similarity(p.normalized_name, search_term) AS score
    FROM products p
    WHERE (supplier_filter IS NULL OR p.supplier = supplier_filter)
      AND p.normalized_name % search_term
    ORDER BY similarity(p.normalized_name, search_term) DESC
    LIMIT limit_count * 3
  ),
  combined AS (
    SELECT 
      COALESCE(s.id, t.id) AS id,
      COALESCE(s.score, 0) * semantic_weight + 
      COALESCE(t.score, 0) * trigram_weight AS combined_score,
      COALESCE(s.score, 0) AS semantic_score,
      COALESCE(t.score, 0) AS trigram_score
    FROM semantic_results s
    FULL OUTER JOIN trigram_results t ON s.id = t.id
  )
  SELECT 
    p.id,
    p.product_name,
    p.supplier,
    p.unit_price,
    c.combined_score,
    c.semantic_score,
    c.trigram_score
  FROM combined c
  JOIN products p ON p.id = c.id
  ORDER BY c.combined_score DESC
  LIMIT limit_count;
END;
$$ LANGUAGE plpgsql;
```

---

## 📈 예상 정확도 개선 근거

### 왜 Semantic Search가 효과적인가?

1. **의미 기반 거리 계산**
   ```
   "버터롤" 임베딩 ←→ "오렌지" 임베딩 = 거리 멀음 (다른 카테고리)
   "버터롤" 임베딩 ←→ "모닝빵" 임베딩 = 거리 가까움 (같은 카테고리)
   ```

2. **동의어/유사어 처리**
   ```
   "만두" ≈ "교자" ≈ "왕만두" (의미적으로 유사)
   "우유" ≈ "밀크" ≈ "흰우유" (같은 제품군)
   ```

3. **벤치마크 기반 예상**
   - E5 모델 한국어 MTEB 점수: 0.72 (상위권)
   - 유사 프로젝트 사례: 텍스트 매칭 정확도 15-25%p 개선

### 예상 결과

| 메트릭 | Before (Phase 1) | After (Phase 2) |
|--------|------------------|-----------------|
| 평균 점수 | 85점 | 92-95점 |
| 오매칭률 | ~5% | <1% |
| "빵→과일" 오류 | 발생 | 해결 |

---

## ⚠️ 리스크와 대안

### 리스크 1: Edge Function Cold Start

**문제**: 첫 요청 시 모델 로딩에 3-5초 소요

**대안**:
- A) Warm-up cron job (5분마다 ping)
- B) 클라이언트에서 pre-fetch
- C) 더 작은 모델 사용 (distilled)

### 리스크 2: 임베딩 생성 비용

**문제**: 23,866개 상품 임베딩 생성 시간

**대안**:
- A) 배치 처리 (야간 실행)
- B) 신규 상품만 실시간 생성
- C) 외부 임베딩 API 사용 (비용 발생)

### 리스크 3: 한국어 모델 성능

**문제**: 식품 도메인 특화 용어 처리

**대안**:
- A) Fine-tuning (데이터 필요)
- B) KoSimCSE 모델로 전환
- C) 카테고리 pre-filter 추가

### 리스크 4: 무료 플랜 제한

**문제**: Edge Function 월 50만 실행 제한

**계산**:
- 일 평균 쿼리: ~100회 (예상)
- 월간: 100 x 30 = 3,000회
- **여유 충분** ✅

---

## 🗓️ 구현 일정

| 단계 | 작업 | 예상 시간 |
|------|------|----------|
| 1 | pgvector 설정 | 30분 |
| 2 | Edge Function 개발 | 2시간 |
| 3 | 상품 임베딩 생성 | 1-2시간 |
| 4 | Semantic Search 함수 | 1시간 |
| 5 | Hybrid Search 통합 | 2시간 |
| 6 | 테스트 및 검증 | 2시간 |
| **총계** | | **8-10시간** |

---

## ✅ 유효성 체크리스트

- [x] Supabase 무료 플랜에서 pgvector 지원됨
- [x] Edge Functions에서 ONNX 모델 실행 가능 (512MB 메모리)
- [x] multilingual-e5-small이 한국어 지원함
- [x] 예상 비용: $0 (무료)
- [x] 구현 복잡도: 중간 (기존 코드 수정 최소화)

---

## 🚀 다음 단계

1. **Step 1 실행**: pgvector 마이그레이션 적용
2. **Edge Function 개발**: generate-embedding 함수 생성
3. **테스트**: 오매칭 케이스 ("프렌치버터롤" → ?) 검증
4. **프로덕션 적용**: 기존 검색 함수 대체

---

**결론**: Phase 2는 기술적으로 유효하며, Supabase 무료 플랜 내에서 구현 가능합니다. 예상 정확도 개선은 7-10%p이며, 핵심 오매칭 문제(빵↔과일)를 근본적으로 해결할 수 있습니다.
