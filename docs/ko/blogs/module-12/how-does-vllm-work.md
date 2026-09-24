# vLLM은 어떻게 동작하는가? — 한국어 상세 학습 노트

> 원문: https://outcomeschool.com/blog/how-does-vllm-work
> 원저자: Amit Shekhar / Outcome School
> 문서 성격: **원문 전체 번역본이 아닌 독립적인 한국어 상세 해설·학습 노트**

## 핵심 해설

PagedAttention과 Continuous Batching을 중심으로 많은 사용자에게 LLM을 효율적으로 Serving하는 vLLM을 배웁니다.

## 핵심 학습 항목

- LLM Serving이란?
- Prefill, Decode, KV Cache 복습
- KV Cache GPU Memory 문제
- 단순 Serving의 낭비
- vLLM이란?
- PagedAttention
- Memory Sharing
- Continuous Batching
- OpenAI-compatible API Server
- 장점
- 실제 활용

## 단계별 학습 가이드

### 1. LLM Serving이란?

**LLM Serving이란?**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 2. Prefill, Decode, KV Cache 복습

**Prefill, Decode, KV Cache 복습**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 3. KV Cache GPU Memory 문제

**KV Cache GPU Memory 문제**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 4. 단순 Serving의 낭비

**단순 Serving의 낭비**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 5. vLLM이란?

**vLLM이란?**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 6. PagedAttention

**PagedAttention**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 7. Memory Sharing

**Memory Sharing**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 8. Continuous Batching

**Continuous Batching**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 9. OpenAI-compatible API Server

**OpenAI-compatible API Server**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 10. 장점

**장점**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 11. 실제 활용

**실제 활용**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

## 실무 연결

- 정확도·안정성·속도·메모리에 미치는 영향을 확인합니다.
- training과 inference에서 동작이 달라지는지 구분합니다.
- 관련 hyperparameter와 실패 조건을 함께 확인합니다.
- 실제 프레임워크 구현과 연결해서 봅니다.

## 점검 질문

1. vLLM은 어떻게 동작하는가?을 한 문장으로 설명할 수 있는가?
2. 왜 필요한지 설명할 수 있는가?
3. 핵심 데이터 흐름을 순서대로 설명할 수 있는가?
4. 대표 장점과 한계를 말할 수 있는가?
5. 언제 이 방법을 선택할지 설명할 수 있는가?

## 원문

- https://outcomeschool.com/blog/how-does-vllm-work
