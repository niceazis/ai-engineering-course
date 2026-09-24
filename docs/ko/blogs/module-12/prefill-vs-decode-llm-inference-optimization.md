# Prefill vs Decode — 한국어 상세 학습 노트

> 원문: https://outcomeschool.com/blog/prefill-vs-decode-llm-inference-optimization
> 원저자: Amit Shekhar / Outcome School
> 문서 성격: **원문 전체 번역본이 아닌 독립적인 한국어 상세 해설·학습 노트**

## 핵심 해설

LLM 추론의 두 단계인 Prefill과 Decode, 그리고 두 단계를 연결하는 KV Cache를 배웁니다.

## 핵심 학습 항목

- LLM Inference란?
- Prefill과 Decode
- Prefill 설명
- Decode 설명
- 두 단계와 KV Cache 흐름
- KV Cache의 역할
- Decode 단계별 예제
- Prefill vs Decode
- Compute-bound vs Memory-bound
- TTFT, TPOT, Throughput, End-to-End Latency
- 단계별 최적화 기법
- 결론

## 단계별 학습 가이드

### 1. LLM Inference란?

**LLM Inference란?**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 2. Prefill과 Decode

**Prefill과 Decode**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 3. Prefill 설명

**Prefill 설명**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 4. Decode 설명

**Decode 설명**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 5. 두 단계와 KV Cache 흐름

**두 단계와 KV Cache 흐름**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 6. KV Cache의 역할

**KV Cache의 역할**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 7. Decode 단계별 예제

**Decode 단계별 예제**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 8. Prefill vs Decode

**Prefill vs Decode**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 9. Compute-bound vs Memory-bound

**Compute-bound vs Memory-bound**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 10. TTFT, TPOT, Throughput, End-to-End Latency

**TTFT, TPOT, Throughput, End-to-End Latency**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 11. 단계별 최적화 기법

**단계별 최적화 기법**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 12. 결론

**결론**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

## 실무 연결

- 정확도·안정성·속도·메모리에 미치는 영향을 확인합니다.
- training과 inference에서 동작이 달라지는지 구분합니다.
- 관련 hyperparameter와 실패 조건을 함께 확인합니다.
- 실제 프레임워크 구현과 연결해서 봅니다.

## 점검 질문

1. Prefill vs Decode을 한 문장으로 설명할 수 있는가?
2. 왜 필요한지 설명할 수 있는가?
3. 핵심 데이터 흐름을 순서대로 설명할 수 있는가?
4. 대표 장점과 한계를 말할 수 있는가?
5. 언제 이 방법을 선택할지 설명할 수 있는가?

## 원문

- https://outcomeschool.com/blog/prefill-vs-decode-llm-inference-optimization
