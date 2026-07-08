# 실습 7: RAG 평가 파이프라인 만들기

## 목표

06까지 만든 챗봇을 한 번 실행해 보는 것에서 끝내지 않고, 튜닝 결과가 실제로 좋아졌는지 평가합니다.

이 실습에서는 다음을 만듭니다.

- 10개 평가 질문 로드
- 원 질문 + 멀티 쿼리 검색
- 검색된 근거 문서 확인
- 답변 생성
- 자동 평가
- 문항별 사람 평가
- 결과 저장

## 완료 기준

`07_eval/evaluate.py`를 실행했을 때 모든 문항이 아래 기준을 만족하면 실습 7을 완료한 것으로 봅니다.

- 정보가 있는 질문: 기대한 근거 프로젝트를 모두 검색한다.
- 정보가 있는 질문: 답변에 핵심 키워드가 포함된다.
- 정보가 없는 질문: 추측하지 않고 보류 응답한다.
- 사람 평가: 각 문항의 의도한 행동을 했다고 판단한다.

## 실행 전 준비

먼저 인덱스를 최신 상태로 만듭니다.

```bash
python lessons/rag-handout_answer/03_build_index.py
```

그 다음 평가를 실행합니다.

```bash
python lessons/rag-handout_answer/07_eval/evaluate.py
```

사람 평가를 건너뛰고 자동 평가만 확인하려면 다음처럼 실행합니다.

```bash
python lessons/rag-handout_answer/07_eval/evaluate.py --no-human
```

## 튜닝 실험 순서

1. `03_build_index.py`에서 `chunk_size`, `chunk_overlap` 변경
2. `05_qna_chain.py` 또는 `07_eval/evaluate.py`에서 검색 개수 `k` 변경
3. 프롬프트 문장 수정
4. `03_build_index.py` 재실행
5. `07_eval/evaluate.py` 실행
6. 자동 평가와 사람 평가 결과 비교

## 사람 평가 방식

각 문항마다 `intended_behavior`가 표시됩니다.

터미널에서 답변을 읽고 다음 질문에 `y` 또는 `n`으로 답합니다.

```text
의도한 행동을 했나요? (y/n):
```

자동 지표로 보기 어려운 비교 품질, 보류 응답의 적절성, 설명 방식은 이 사람 평가로 확인합니다.

