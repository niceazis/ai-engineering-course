# TensorRT-LLM은 어떻게 동작하는가? — 한국어 상세 학습 노트

> 원문: https://outcomeschool.com/blog/how-does-tensorrt-llm-work
> 원저자: Amit Shekhar / Outcome School
> 문서 성격: **원문 전체 번역본이 아닌 독립적인 한국어 상세 해설·학습 노트**

## 핵심 해설

NVIDIA GPU에서 가능한 최고 수준의 추론 성능을 목표로 Build-time 최적화와 Kernel Fusion, Quantization, Paged KV Cache 등을 적용하는 TensorRT-LLM을 배웁니다.

## 핵심 학습 항목

- Inference란?
- GPU와 Kernel
- GPU가 시간을 낭비하는 지점
- TensorRT-LLM이란?
- 미리 Model을 준비하는 핵심 아이디어
- Model에서 Engine으로 Build
- Kernel Fusion
- Quantization
- Custom Attention Kernel
- Paged KV Cache
- In-flight Batching
- CUDA Graph
- Speculative Decoding
- Multi-GPU
- 실제 Serving
- PyTorch Backend
- 요청 하나의 전체 과정
- TensorRT-LLM vs vLLM
- 강점과 한계

## 단계별 학습 가이드

### 1. Inference란?

**Inference란?**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 2. GPU와 Kernel

**GPU와 Kernel**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 3. GPU가 시간을 낭비하는 지점

**GPU가 시간을 낭비하는 지점**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 4. TensorRT-LLM이란?

**TensorRT-LLM이란?**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 5. 미리 Model을 준비하는 핵심 아이디어

**미리 Model을 준비하는 핵심 아이디어**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 6. Model에서 Engine으로 Build

**Model에서 Engine으로 Build**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 7. Kernel Fusion

**Kernel Fusion**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 8. Quantization

**Quantization**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 9. Custom Attention Kernel

**Custom Attention Kernel**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 10. Paged KV Cache

**Paged KV Cache**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 11. In-flight Batching

**In-flight Batching**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 12. CUDA Graph

**CUDA Graph**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 13. Speculative Decoding

**Speculative Decoding**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 14. Multi-GPU

**Multi-GPU**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 15. 실제 Serving

**실제 Serving**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 16. PyTorch Backend

**PyTorch Backend**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 17. 요청 하나의 전체 과정

**요청 하나의 전체 과정**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 18. TensorRT-LLM vs vLLM

**TensorRT-LLM vs vLLM**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

### 19. 강점과 한계

**강점과 한계**의 정의, 필요한 이유, 입력과 출력, 전체 시스템에서의 위치를 연결해서 이해합니다. 작은 예제나 코드 흐름으로 직접 확인하고, 비슷한 대안과의 차이 및 trade-off까지 설명할 수 있어야 합니다.

## 실무 연결

- 정확도·안정성·속도·메모리에 미치는 영향을 확인합니다.
- training과 inference에서 동작이 달라지는지 구분합니다.
- 관련 hyperparameter와 실패 조건을 함께 확인합니다.
- 실제 프레임워크 구현과 연결해서 봅니다.

## 점검 질문

1. TensorRT-LLM은 어떻게 동작하는가?을 한 문장으로 설명할 수 있는가?
2. 왜 필요한지 설명할 수 있는가?
3. 핵심 데이터 흐름을 순서대로 설명할 수 있는가?
4. 대표 장점과 한계를 말할 수 있는가?
5. 언제 이 방법을 선택할지 설명할 수 있는가?

## 원문

- https://outcomeschool.com/blog/how-does-tensorrt-llm-work
