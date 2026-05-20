# KLUE-RoBERTa Distill — 댓글 5-class 분류기

GPT-4.1 teacher 라벨(`comment_labels/labeled_gpt41_azure.jsonl`, 6,375건)로 `klue/roberta-base`를 distill하고, 운영에서는 confidence-gated cascade(`local 1차 → 저신뢰만 GPT-4.1 fallback`)로 호출비를 줄이는 모듈.

## 폴더 구조

```
local_classifier/
├── config.py              # 경로·라벨·하이퍼파라미터 (A40 기준 batch/bf16)
├── preprocess.py          # PII scrub · NFKC · 반복문자 · lang detect · dedup key
├── prepare_dataset.py     # JSONL → 정제 → video_id 그룹 split → JSONL + class_weights
├── dataset.py             # torch Dataset
├── train.py               # KLUE-RoBERTa-base fine-tune (bf16, class+conf weighted CE)
├── evaluate.py            # test acc · per-class P/R/F1 · macro-F1 · confusion matrix
├── classifier.py          # LocalRobertaClassifier (BaseCommentClassifier 호환)
├── router.py              # CascadeRouter (local → API fallback)
├── shadow.py              # ShadowLogger (운영 영향 없이 disagreement 수집)
├── requirements.txt
└── artifacts/             # gitignore — data/, model/best/, logs/
```

## 라벨 매핑 (고정 — 변경 시 재학습 필수)

`comment_filtering_agent/classifiers/classifier_interface.py:FineTunedClassifier` 와 동일 순서.

| id | label |
|----|-------|
| 0 | PRODUCT_OPINION |
| 1 | VIDEO_REACTION |
| 2 | CHATTER |
| 3 | QUESTION |
| 4 | OFF_TOPIC |

## 환경

NVIDIA **A40 (48GB, Ampere sm_86)** 서버 기준.

```bash
# CUDA 12.x 환경
pip install torch --index-url https://download.pytorch.org/whl/cu121
pip install -r local_classifier/requirements.txt
```

A40에서는 bf16 autocast + TF32 matmul이 기본값 — `config.USE_BF16 = True`.

## 사용 흐름

### 1) 데이터셋 생성

```bash
python -m local_classifier.prepare_dataset
```

처리:
- `teacher_model == "gpt-4.1-mini"` 제외 (119건 → OOD 평가 보관용)
- `confidence < 0.85` 제외
- PII scrub: 이메일·URL·멘션·전화 → 마스크 토큰
- NFKC 정규화 + `ㅋㅋㅋㅋㅋ` 3자 압축 + 공백 정리
- 텍스트 alnum 정규화 후 md5 near-dup dedup
- **video_id 단위** train 80% / val 10% / test 10% 그룹 split (댓글 단위 누설 차단)
- `class_weights.json` (train 빈도 역수)

산출: `artifacts/data/{train,val,test}.jsonl` + `class_weights.json`

### 2) 학습

```bash
python -m local_classifier.train
```

- 모델: `klue/roberta-base` (A40에서 `klue/roberta-large` 도 batch 32~64로 가능)
- 손실: `cross_entropy(logits, labels, weight=class_w, label_smoothing=0.05)` × `per_example_confidence`
- AdamW, lr 2e-5, weight decay 0.01, warmup 10%, 5 epoch, grad clip 1.0
- bf16 autocast + TF32 matmul + cudnn.benchmark
- best val acc 갱신 시 `artifacts/model/best/`에 자동 저장

### 3) 평가

```bash
python -m local_classifier.evaluate
```

`artifacts/logs/test_summary.json` · `test_predictions.jsonl` 산출.
KPI 목표: **macro F1 ≥ 0.85** (GPT-4.1 대비 -3%p 이내).

### 4) 인퍼런스 / 캐스케이드 라우터

```python
from local_classifier.classifier import LocalRobertaClassifier
from local_classifier.router import CascadeRouter
from comment_filtering_agent.classifiers.optimized_batch_classifier import (
    OptimizedBatchClassifier,
)

local = LocalRobertaClassifier(use_gpu=True)
api = OptimizedBatchClassifier(...)        # 기존 GPT-4.1 분류기 그대로
router = CascadeRouter(local=local, api=api, tau_high=0.85, tau_low=0.55)

results = router.classify_batch(comments)  # results[i].classifier_used 로 라우팅 확인
print(router.get_stats())                  # local_rate, api_rate, low_conf_rate
```

### 5) Shadow 모드 (P2 — τ 튜닝용)

운영 출력은 API 그대로, 로컬은 비교 로깅만.

```python
from local_classifier.shadow import ShadowLogger

shadow = ShadowLogger(api_classifier=api, local_classifier=local)
results = shadow.classify_batch(comments)  # API 결과 반환
print(shadow.get_stats())                   # agreement_rate
# artifacts/logs/shadow.jsonl 에 라인별 비교
```

## 임계값 튜닝 가이드

1. shadow 모드로 5~10k건 로그 수집.
2. 로컬 conf 분포 vs (api == local) 일치율 곡선 그리기.
3. `tau_high` = **api 호출 ≤ 20%** 가 되는 최소값.
4. `tau_low` = local-api disagreement 비율이 5%를 넘는 conf 지점.
5. canary 10% 적용 → KPI 미달 시 즉시 롤백.

## 비기능 요구사항

- 라벨 매핑·인터페이스(`ClassificationResult`)는 `comment_filtering_agent` 와 1:1 호환 — 기존 파이프라인 수정 최소화 (NR-007/012).
- 학습·인퍼런스가 분리되어 모델 교체 시 `MODEL_DIR/best/` 만 갈아끼우면 됨.
- shadow 실패는 prod에 영향 없음 (예외 잡고 API 결과만 반환).
