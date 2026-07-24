R-CNN:
R-CNN(Region-based Convolutional Neural Networks)은 컴퓨터 비전 분야에서 객체 검출(Object Detection)을 위해 사용되는 신경망 기반 알고리듬이다. 
이 기술은 이미지 내에서 관심 있는 객체를 식별하고, 그 위치를 정확하게 찾아내는 데 초점을 맞춘다. 
R-CNN의 핵심 아이디어는 후보 영역(Region Proposal)을 먼저 생성하고, 각 영역에 대해 컨볼루션 신경망(CNN)을 적용하여 객체를 분류하는 것이다. 
후보 영역은 이미지 내에서 객체가 존재할 가능성이 높은 부분을 의미하며, 이들 영역은 이미지에서 다양한 크기와 비율로 추출된다.

R-CNN은 기존의 객체 검출 방법에 비해 높은 정확도를 제공하지만, 처리 속도가 느리고 계산 비용이 높다는 단점이 있다. 이러한 문제를 해결하기 위해, R-CNN의 개선된 버전들이 개발되었다. 
Fast R-CNN과 Faster R-CNN은 R-CNN의 아이디어를 기반으로 하면서도 효율성과 속도를 크게 향상시켰다.

<참고 문헌 및 저작권>
R. Girshick, J. Donahue, T. Darrell, J. Malik, 《Rich feature hierarchies for accurate object detection and semantic segmentation》, CVPR 2014: https://arxiv.org/abs/1311.2524
R. Girshick, 《Fast R-CNN》, IEEE International Conference on Computer Vision (ICCV): https://arxiv.org/abs/1504.08083
S. Ren, K. He, R. Girshick, J. Sun, 〈Faster R-CNN: Towards Real-Time Object Detection with Region Proposal Networks〉, NeurIPS 2015: https://arxiv.org/abs/1506.01497

RAG: Retrieval-Augmented Generation (검색 증강 생성):
Retrieval-Augmented Generation(RAG)은 검색 모듈이 찾은 외부 문서를 LLM의 프롬프트에 주입해 사실 기반 응답을 생성하도록 설계된 지식-집약적 언어 처리 프레임워크이다.

<역사와 배경>
2020년 Meta AI 소속 Kiela·Lewis 등이 발표한 논문에서 처음 제안되었으며, 질문응답·지식기반 챗봇에서 파라미터만으로는 부족한 최신 지식을 보완하기 위한 방법으로 자리 잡았다. 
2024년 이후 마이크로소프트·구글·아마존·엔비디아 등 빅테크가 급격히 채택하면서 산업 표준으로 정착하였다.

<작동 원리>
인덱싱 단계: 도메인 데이터(위키·사내 문서 등)를 임베딩 벡터로 변환해 벡터 데이터베이스에 저장한다.
검색 단계: 사용자의 질의를 임베딩하여 K-최근접 탐색으로 관련 문서를 검색한다.
증강 단계: 검색 문서를 잘라(concatenate‧chunk) LLM 프롬프트에 삽입한다.
생성 단계: LLM이 증강된 프롬프트를 받아 최종 답변을 생성하고, 필요하면 출처를 인용한다.

대표 변형에는 토큰마다 다른 문서를 조건화하는 RAG-Token과 시퀀스 전체에 동일 문서를 사용하는 RAG-Sequence가 있다.

<장점>
지식 최신성 확보: 모델 재훈련 없이 새 데이터를 즉시 활용한다.
할루시네이션 감소: 근거 문서를 명시해 답변의 사실성을 높인다.
비용 절감: 파라미터 업데이트가 필요 없으므로 계산·운영비가 낮다.
투명성: 응답과 함께 문서 링크를 제시해 검증 가능성이 커진다.

<한계와 과제>
검색기 성능에 따라 답변 품질이 좌우된다.
장문 문서가 프롬프트 길이를 초과하면 정보 손실이 발생한다.
신뢰도 낮은 문서를 가져오면 “근거 기반 거짓말”이 될 위험이 있다.
평가 기준 부재: 검색과 생성 두 단계를 함께 측정할 통합 지표가 연구 중이다.

<활용 사례>
사내 정책·지식관리 챗봇
의료·법률 도메인 전문 QA
코드 보조, 논문 요약, 검색 기반 글쓰기
멀티모달 확장(이미지+텍스트 RAG) 및 에이전트 시스템의 “장기 메모리” 구성

<관련 용어>
LLM, 임베딩, 벡터 데이터베이스, 하이브리드 검색, 프롬프트 엔지니어링, 파인튜닝, RAG-Chain.

<참고 문헌 및 저작권>
Kiela, D., Lewis, P., Perez, E., Piktus, A., Petroni, F., Karpukhin, V., … Riedel, S. (2020). Retrieval-Augmented Generation for Knowledge-Intensive NLP Tasks [Conference paper]. arXiv.
Yu, H., Gan, A., Zhang, K., Tong, S., Liu, Q., & Liu, Z. (2024). Evaluation of Retrieval-Augmented Generation: A Survey. arXiv.
IBM. (2023, August 22). What is retrieval-augmented generation (RAG)? IBM Research Blog.
Booth, H. (2024, September 5). Patrick Lewis – Director of Machine Learning, Cohere. TIME.

RANSAC: Random Sample Consensus (랜덤 샘플 합의):
RANSAC(Random Sample Consensus)은 관측된 데이터 세트에서 수학적 모델의 매개변수를 추정하기 위한 반복적 방법으로, 데이터에 포함된 이상치에 의한 영향을 받지 않도록 설계된 비결정론적 알고리듬이다. 
이 알고리듬은 이상치 감지 방법으로도 해석될 수 있다. 
RANSAC의 기본 가정은 데이터가 모델 매개변수의 일부 세트로 설명될 수 있는 '인라이어'(inliers)와 모델에 맞지 않는 '아웃라이어'(outliers)로 구성된다는 것이다. 
인라이어만을 사용하여 최적의 모델 매개변수를 추정하는 과정을 반복적으로 수행한다.

RANSAC 알고리듬은 로봇공학에서 광범위하게 활용되며, 
주로 기하학적 형태(평면, 원기둥, 구 등) 인식이나 서로 다른 카메라 시점 간의 최적 변환 추정에 사용된다. 
이러한 응용 분야는 로봇이 실내외 환경을 이해하고 탐색 또는 매핑하는 데 중요한 역할을 한다.

<참고 문헌 및 저작권>
Wikipedia. (n.d.). Random sample consensus. Retrieved from https://en.wikipedia.org/wiki/Random_sample_consensus
RANSAC for Robotic Applications: A Survey, https://www.mdpi.com/1424-8220/23/1/327

RBM: restricted Boltzmann machine (제약 볼츠만 머신): https://wikidocs.net/141215

REINFORCE: https://wikidocs.net/168954

RL: reinforcement learning (강화학습):
강화학습(Reinforcement Learning, RL)은 기계학습의 한 분야로, 에이전트가 환경과 상호작용하며 보상을 극대화하는 방법을 학습하는 과정이다. 
이 방법에서 에이전트는 주어진 상태에 대해 어떤 행동을 취할지 결정하고, 그 행동에 따른 결과로 환경으로부터 보상을 받는다. 
강화학습의 목표는 에이전트가 환경으로부터 최대한의 보상을 얻을 수 있도록 학습하는 것이다. 
이 과정은 시행착오를 통해 최적의 정책(policy)을 발견하는 것을 포함한다.

강화학습은 다양한 문제에 적용될 수 있으며, 
주로 게임, 로봇 공학, 자연어 처리, 자율 주행 차량 등과 같은 분야에서 활용된다. 
이 학습 방법은 에이전트가 경험을 통해 스스로 학습하도록 함으로써, 명시적인 지도 없이도 복잡한 문제를 해결할 수 있게 해준다.

<참고 문헌 및 저작권>
Richard S. Sutton and Andrew G. Barto, 《Reinforcement Learning: An Introduction》: http://incompleteideas.net/book/the-book.html
David Silver et al., 〈Mastering the game of Go with deep neural networks and tree search〉, Nature: https://www.nature.com/articles/nature16961
DeepMind's Reinforcement Learning Page

RLHF: Reinforcement Learning from Human Feedback:
RLHF(Reinforcement Learning from Human Feedback)란 인간의 피드백을 기반으로 하는 강화학습 방법이다. 
이 접근법에서는 인간의 직접적인 지도나 평가를 통해 학습 과정을 개선하고, 보다 효과적이고 인간 친화적인 결과를 도출하는 것이 목표이다. 
전통적인 강화학습은 환경으로부터의 보상을 통해 학습하는 반면, RLHF는 인간의 피드백을 추가적인 학습 신호로 사용한다. 
이는 머신러닝 모델이 인간의 가치, 선호, 의도를 더 잘 반영할 수 있게 돕는다.

RLHF의 접근 방식은 특히 복잡하거나 모호한 작업에서 유용하다. 
예를 들어, 언어 모델이 특정한 문맥에서 어떤 대답이 더 적절한지 결정하기 어려울 때, 인간의 피드백은 모델이 더욱 정확하고 유용한 응답을 생성하는 데 도움을 준다. 
이런 방식으로, RLHF는 모델의 성능을 개선하고, 인간 사용자와의 상호작용을 개선하는 데 기여한다.

<참고 문헌 및 저작권>
Christiano, Paul et al., 《Deep Reinforcement Learning from Human Preferences》, 2017.: https://arxiv.org/abs/1706.03741

RMSProp: https://wikidocs.net/152835

RNN: Recurrent Neural Network (순환 신경망)
RNN(Recurrent Neural Network)란 순환 신경망이다. 이것은 기본적으로 피드포워드 신경망(Feedforward Neural Networks)과 달리, 순환적인 특징을 가지며, 이로 인해 시간에 걸쳐 정보를 유지하고 전달하는 능력이 있다. 
RNN은 주로 시계열 데이터 분석에 사용되며, 과거의 정보를 이용하여 미래를 예측한다.

RNN의 가장 큰 특징은 '메모리'를 가지고 있다는 것이다. 이 메모리는 과거의 정보를 저장하고, 이를 현재의 결정에 활용할 수 있다. 
하지만 RNN은 장기적인 의존성(Long-Term Dependencies) 문제를 가지고 있다. 
즉, 시간 간격이 길어질수록 학습 능력이 저하되는 문제가 있다. 
이 문제를 해결하기 위해 LSTM(Long Short Term Memory)과 같은 변형된 RNN 구조가 개발되었다.

<참고 문헌 및 저작권>
Ian Goodfellow, Yoshua Bengio, Aaron Courville, 《Deep Learning》, The MIT Press: https://www.deeplearningbook.org/
Sepp Hochreiter, Jurgen Schmidhuber, 〈Long Short-Term Memory〉, Neural Computation: https://direct.mit.edu/neco/article-abstract/9/8/1735/6109/Long-Short-Term-Memory?redirectedFrom=fulltext
Andrej Karpathy, 〈The Unreasonable Effectiveness of Recurrent Neural Networks〉, Andrej Karpathy blog: https://karpathy.github.io/2015/05/21/rnn-effectiveness/

ROC curve (ROC 곡선):
ROC 곡선(Receiver Operating Characteristic Curve)은 기계 학습에서 분류 모델의 성능을 평가하는 그래픽 도구다. 
이 곡선은 다양한 임곗값 설정에서 분류 모델의 성능을 평가하기 위해 사용되며, 
진정한 양성 비율(True Positive Rate, TPR)을 거짓 양성 비율(False Positive Rate, FPR)에 대해 다른 임곗값에서 그래프로 나타낸다. 
이를 통해 진정한 양성의 이점과 거짓 양성의 비용 사이의 교환을 평가할 수 있다.

ROC 곡선은 원래 제2차 세계 대전 동안 적군 객체를 탐지하기 위해 개발된 신호 탐지 이론에서 유래했다. 
이후 의학 및 기계 학습 분야, 특히 이진 분류 문제에서 널리 채택되었다. 
기계 학습 맥락에서 ROC 곡선은 분류자의 성능을 시각화하는 데 사용되며, 
TPR(민감도 또는 재현율로도 알려짐)을 y축에, FPR(1 - 특이성)을 x축에 표시한다. 
TPR은 모델이 실제 양성을 얼마나 잘 식별하는지, FPR은 실제 음성을 양성으로 잘못 분류한 비율을 나타낸다.

ROC 곡선의 중요한 부분 중 하나는 곡선 아래 면적(Area Under the Curve, AUC)으로, 분류자의 성능을 요약하는 단일 스칼라 값으로 제공된다. 
AUC는 0에서 1 사이의 값을 가지며, 1에 가까울수록 완벽한 분류기를 의미하고, 0.5는 무작위 추측의 성능을 나타낸다. 
일반적으로 AUC 값이 높을수록 모델의 성능이 더 좋다고 평가된다.

ROC 곡선은 클래스 분포의 변화에 불변하는 주요 장점이 있다. 
이는 양성과 음성 인스턴스의 비율이 변경되어도 분류자의 ROC 곡선이 동일하게 유지된다는 것을 의미한다. 
이 특성은 실제 세계 시나리오의 진정한 클래스 분포를 반영하지 않는 데이터 세트에서 모델을 평가할 때 특히 유용하다.

그러나 ROC 곡선은 높은 클래스 불균형 상황에서 과도하게 낙관적일 수 있다는 한계가 있다. 
FPR이 실제 음성을 적절히 고려하지 않기 때문이다. 이러한 경우에는 정밀도와 재현율을 그린 정밀도-재현율(PR) 곡선이 더 유익한 지표가 될 수 있다. 
또한, ROC 곡선은 양성 클래스의 실제 유병률을 반영하지 않으며, 이는 분류자의 실질적인 유용성을 결정하는 데 중요할 수 있다.

<참고 문헌 및 저작권>
Wikipedia. Receiver operating characteristic. https://en.wikipedia.org/wiki/Receiver_operating_characteristic
DeepAI. Receiver Operating Characteristic Curve Definition. https://deepai.org/machine-learning-glossary-and-terms/receiver-operating-characteristic-curve
Analytics Vidhya. Guide to AUC ROC Curve in Machine Learning. https://www.analyticsvidhya.com/blog/2020/06/auc-roc-curve-machine-learning/

ROI Pooling:
RoI Pooling(Region of Interest Pooling)은 컴퓨터 비전 분야에서 객체 검출(Object Detection) 알고리즘의 일부로 사용되는 기술이다. 
이 방법은 이미지 내의 관심 영역(Region of Interest, RoI)에서 고정 크기의 특징 맵(Feature Map)을 추출하는 과정을 말한다. 
RoI Pooling은 주로 Fast R-CNN과 같은 신경망 구조에서 사용되며, 다양한 크기와 비율의 RoI를 동일한 크기의 특징 맵으로 변환하는 데 사용된다.

이 과정은 먼저 각 RoI를 고정된 수의 구역으로 분할하고, 각 구역에서 최대값(Max Pooling)을 추출하여 고정된 크기의 작은 특징 맵을 생성한다. 
예를 들어, 7x7 크기의 특징 맵을 출력하기 위해, 각 RoI를 7x7 그리드로 분할하고 각 그리드 셀에서 최대값을 추출한다. 
RoI Pooling은 다양한 크기의 객체를 효과적으로 처리할 수 있게 하며, 객체 검출 과정에서 높은 성능과 정확도를 달성하는 데 기여한다.


R. Girshick, 《Fast R-CNN》, IEEE International Conference on Computer Vision (ICCV): https://arxiv.org/abs/1504.08083
S. Ren, K. He, R. Girshick, J. Sun, 《Faster R-CNN: Towards Real-Time Object Detection with Region Proposal Networks》, NeurIPS 2015: https://arxiv.org/abs/1506.01497
J. Dai, Y. Li, K. He, J. Sun, 〈R-FCN: Object Detection via Region-based Fully Convolutional Networks〉, NeurIPS 2016: https://arxiv.org/abs/1605.06409

ROUGE: Recall-Oriented Understudy for Gisting Evaluation:
ROUGE는 “Recall-Oriented Understudy for Gisting Evaluation”의 약자로, 자동 텍스트 요약 및 기계 번역 성능을 평가하기 위해 고안된 메트릭의 집합이다. 
ROUGE는 생성된 텍스트와 참조 텍스트 간의 겹치는 단어 수를 기반으로 계산되며, 주로 요약의 품질을 평가하는 데 사용된다.

주요 유형:
ROUGE-N: 단어 n-그램(연속된 n개의 단어)의 겹침을 측정한다. 예를 들어, ROUGE-1은 유니그램(단어 하나), ROUGE-2는 바이그램(두 단어의 조합)의 겹침을 평가한다.
ROUGE-L: LCS(가장 긴 공통 부분 문자열)를 기반으로 한다. 연속적이지 않더라도 순서를 유지하는 단어 시퀀스를 측정하여 요약의 문장 수준 일치를 평가한다.
ROUGE-S: skip-gram 겹침을 측정하여, 단어 사이에 다른 단어들이 있어도 순서대로 나타나는 단어 쌍을 평가한다.
ROUGE는 자동 요약 시스템의 정밀도(precision)와 재현율(recall)을 계산하여 성능을 평가한다. 정밀도는 시스템 요약에서 유효한 단어의 비율을, 재현율은 참조 요약에서 시스템 요약이 포착한 단어의 비율을 나타낸다. 
이를 통해 요약의 간결성과 정확성을 동시에 평가할 수 있다.

응용 사례:
자동 텍스트 요약: 자동으로 생성된 요약이 원문에서 중요한 정보를 얼마나 잘 보존하는지 평가하는 데 사용된다.
기계 번역: 번역된 텍스트가 원문과 얼마나 유사한지 평가할 때 사용된다.

<참고 문헌 및 저작권>
https://dev.to/aws-builders/mastering-rouge-matrix-your-guide-to-large-language-model-evaluation-for-summarization-with-examples-jjg
Ganesan, K. (2023). An intro to ROUGE, and how to use it to evaluate summaries. FreeCodeCamp. https://www.freecodecamp.org/news/what-is-rouge-and-how-it-works-for-evaluation-of-summaries-e059fb8ac840/
Towards AI. (2023). ROUGE Metrics: Evaluating Summaries in Large Language Models. https://towardsai.net/p/machine-learning/rouge-metrics-evaluating-summaries-in-large-language-models
https://plainenglish.io/community/evaluating-nlp-models-a-comprehensive-guide-to-rouge-bleu-meteor-and-bertscore-metrics-d0f1b1

RSS: Residual sum of square (잔차제곱합):
<RSS 개념>
잔차 제곱합(RSS)은 통계학에서 회귀 모델로부터 예측된 값과 실제 관측된 데이터 값 사이의 차이, 즉 잔차의 제곱합을 의미한다. 
이는 데이터와 추정 모델 사이의 불일치를 측정하는 지표로 사용되며, 선형 회귀와 같은 추정 모델을 예로 들 수 있다. 
RSS 값이 작으면 모델이 데이터에 잘 부합한다는 의미이며, 모델 선택 및 매개변수 선택에서 최적성 기준으로 활용된다.

<RSS 활용>
RSS는 회귀 분석에서 총 제곱합(TSS)과 회귀로 설명된 제곱합(SSR) 또는 설명된 제곱합(ESS)과 함께 사용되어 데이터의 분산을 평가하고, 회귀 모델이 얼마나 잘 데이터를 설명하는지를 결정한다. 
TSS가 관측 변수의 샘플 평균에 대한 값의 변동을 측정하는 반면, SSR 또는 ESS는 추정된 값과 관측 변수의 평균 값 사이의 차이를 계산한다. 
RSS는 회귀 모델에 의해 나타나지 않는 관측 데이터의 변동성을 측정한다.

RSS는 재무 분석에서도 중요한 역할을 한다. 예를 들어, 투자자들은 RSS를 사용하여 주식 가격의 변동을 추적하고 미래 가격 움직임을 예측할 수 있다. 
RSS를 통해 데이터 세트에서 회귀 모델에 의해 설명되지 않는 불일치 수준을 감지함으로써, 회귀 함수가 주식 가격의 변동을 얼마나 잘 예측하는지 평가할 수 있다.

<참고 문헌 및 저작권>
Wikipedia. (n.d.). Residual sum of squares. In Wikipedia. Retrieved from https://en.wikipedia.org/wiki/Residual_sum_of_squares
Wallstreetmojo.com. (n.d.). Residual Sum of Squares - Meaning, Formula, Examples, Calculate. Retrieved from https://www.wallstreetmojo.com/residual-sum-of-squares/
이관수, 서울사이버대학교 머신러닝 5주차 수업

ReAct (Reason + Act):
ReAct(추론 + 행동)는 언어 모델이 문제를 해결하는 과정에서 추론과 행동을 결합하는 새로운 패러다임이다. 기존의 언어 모델들이 주로 추론이나 행동 중 하나에 집중했던 
반면, ReAct는 이 두 가지 기능을 통합하여 시너지 효과를 창출한다. 이 접근법은 모델이 언어 기반 추론과 특정 작업에 필요한 행동을 교차적으로 생성하도록 하여 더 동적인 문제 해결 과정을 가능하게 한다.

ReAct는 여러 작업에서 뛰어난 성능을 보이며, 특히 질문 응답(HotpotQA)과 사실 검증(FEVER)과 같은 언어 이해 작업에서 두드러진다. 
예를 들어, ReAct는 Wikipedia API와 상호작용하여 필요한 정보를 검색하고, 이를 바탕으로 추론을 업데이트하는 과정을 통해 기존의 단순 추론 모델들이 직면하는 환각 문제를 해결한다. 
또한, ALFWorld와 WebShop과 같은 의사 결정 작업에서도 높은 성공률을 기록하며, 모델이 행동 계획을 유지하고 조정할 수 있도록 돕는다.

ReAct의 장점 중 하나는 사람이 모델의 추론 과정을 쉽게 검토하고 수정할 수 있다는 점이다. 이는 모델의 추론과 행동이 해석 가능하고, 신뢰할 수 있는 결과를 제공하는 데 기여한다. 
또한, ReAct는 소규모 모델의 미세 조정을 통해 대형 모델을 능가하는 성능을 보일 수 있어, 다양한 규모의 모델에 적용 가능하다.

<참고 문헌 및 저작권>
Yao, S., Zhao, J., Yu, D., Du, N., Shafran, I., Narasimhan, K., & Cao, Y. (2022). ReAct: Synergizing Reasoning and Acting in Language Models. Retrieved from arXiv.: https://arxiv.org/abs/2210.03629
Google Research. (2022). ReAct: Synergizing Reasoning and Acting in Language Models. Retrieved from Google Research Blog.: https://research.google/
KDnuggets. (2022). ReAct, Reasoning and Acting augments LLMs with Tools! Retrieved from KDnuggets.

ReLU: rectified linear unit (렐루, 정류 선형 유닛, 정류 선형 단위):
ReLU(렐루)는 인공신경망에서 사용되는 활성화 함수의 일종이다. ReLU의 수학적 표현은 f(x) = max(0, x)로, 입력값이 0보다 크면 그 값을 그대로 출력하고, 0 이하면 0을 출력한다. 
이 단순한 비선형성 때문에, ReLU는 신경망의 학습 속도를 개선하고, 이전에 많이 사용되던 시그모이드 함수나 하이퍼볼릭 탄젠트 함수보다 효율적으로 깊은 네트워크를 학습시킬 수 있다.

ReLU의 주된 장점은 계산 효율성과 비선형적 특성 때문에 더 복잡한 함수를 모델링할 수 있다는 것이다. 
그러나 ReLU는 '죽은 뉴런' 문제를 가지고 있는데, 이는 네트워크의 일부 뉴런이 학습 과정에서 더 이상 활성화되지 않는 현상을 말한다. 
이를 해결하기 위해 Leaky ReLU, Parametric ReLU 등의 변형된 ReLU 함수들이 개발되었다.

<참고 문헌 및 저작권>
Goodfellow, Ian, et al., 《Deep Learning》, MIT Press: https://www.deeplearningbook.org/
Nair, Vinod, and Geoffrey E. Hinton, 〈Rectified Linear Units Improve Restricted Boltzmann Machines〉, ICML 2010: https://www.cs.toronto.edu/~hinton/absps/reluICML.pdf

Regularized Linear Regression (규제 선형 회귀):
정규화된 선형 회귀(Regularized Linear Regression)는 대규모의 독립 변수(예측 변수)를 다루기 위해 추가 제약 조건을 사용하여 불필요한 변수에 더 큰 패널티를 부여함으로써 그 계수를 0에 가깝게 축소하는 회귀 방법이다. 
정규화의 주된 목적은 간단하고 해석 가능하며, 연구 샘플을 넘어 일반화될 수 있는 모델을 만드는 것이며, 연구를 반복할 경우 계수가 크게 변하지 않는 모델을 얻는 것이다.

정규화된 선형 회귀에는 주로 L2 정규화(릿지 회귀), L1 정규화(라쏘 회귀), 그리고 이 둘을 결합한 엘라스틱 넷(Elastic Net) 정규화의 세 가지 기법이 있다. 
릿지 회귀는 L2 정규화를 사용하여 모델의 가중치(계수)의 크기를 가능한 작게 유지하려고 하며, 각 기능이 출력에 낮은 영향을 미치면서 모델의 정확성을 최대한 높이려고 한다. 
라쏘 회귀는 L1 정규화를 적용하여 일부 계수를 0으로 만들어 해당 기능을 모델에서 무시하게 함으로써 모델의 주요 기능을 강조한다. 엘라스틱 넷은 릿지와 라쏘의 정규화 항을 결합하여, 
두 가지 정규화 기법의 장점을 모두 사용하며, 조정이 더 복잡할 수 있지만, 일반적으로 한 가지 정규화 기법만 사용하는 것보다 더 좋은 결과를 낼 수 있다.

L1 정규화와 L2 정규화의 가장 큰 차이점은 L1이 일부 계수를 정확히 0으로 축소하여 모델에서 변수를 선택하는 방식으로 작동한다는 것이다. 
이는 탐색적 분석이나 간단하고 해석 가능한 모델이 필요할 때 유용하다. 
반면에, L2 정규화는 계수의 제곱합을 최소화하기 때문에, 0에 가까운 계수는 거의 축소되지 않으며, 
결과적으로 대부분의 변수가 0이 아닌 계수를 가진 모델을 생성한다. 
이러한 특성 때문에 릿지 회귀는 예측에 있어서 많은 변수가 조금씩 기여할 때 더 나은 성능을 발휘한다.

정규화된 선형 회귀는 과적합을 방지하고 모델의 복잡성을 제어하는 데 유용하다. 
예를 들어, 보스턴 주택 데이터셋에 적용했을 때, 
릿지 회귀는 훈련 세트의 성능은 약간 낮지만, 
테스트 세트에서는 성능이 크게 향상되어,
더 단순하지만 일반화된 모델을 생성한다는 것을 확인할 수 있다. 
라쏘 회귀는 적절한 "alpha" 값(규제의 강도를 조절하는 매개변수)을 선택함으로써 과소적합을 줄이고 모델의 성능을 향상시킬 수 있다. 
엘라스틱 넷은 릿지와 라쏘의 장점을 결합하여 사용하며, 
두 매개변수 "lambda"와 "r"을 조절하는 것이 중요하다.

<참고 문헌 및 저작권>
Dataquest. (n.d.). Regularization in Machine Learning (with Code Examples). Retrieved from https://www.dataquest.io/blog/regularization-in-machine-learning/
Choueiry, G. (2020, September 26). Understand Regularized Regression. Quantifying Health. Retrieved from https://quantifyinghealth.com/regularized-regression/

ResNet: Residual Network (레즈넷):
ResNet은 Residual Network의 약자로, 콘볼루션 신경망(Convolutional Neural Network, CNN) 구조의 한 종류이다. 이는 2015년에 Kaiming He 등이 제안한 아키텍처이다. 
ResNet의 핵심 아이디어는 신경망의 깊이가 깊어짐에 따라 발생하는 훈련 문제를 해결하기 위해 '잔여 학습'이라는 개념을 도입한 것이다. 
즉, 이전 층의 출력이 다음 층의 입력에 그대로 추가되는 '스킵 연결' 또는 '단순히 지나가는 경로'를 도입하여 신경망의 깊이에 따른 문제를 해결하였다.

이 방법으로 ResNet은 최대 152개 층까지 쌓을 수 있게 되었으며, 이를 통해 ImageNet 대회에서 우승하는 등 뛰어난 성능을 보여주었다. 
ResNet은 심층 신경망이 처음 학습할 때 발생하는 문제인 그래디언트 소실(Vanishing Gradient) 문제와 그래디언트 폭발(Exploding Gradient) 문제를 해결하는 데 큰 역할을 했다.

<참고 문헌 및 저작권>
Kaiming He, Xiangyu Zhang, Shaoqing Ren, Jian Sun, 《Deep Residual Learning for Image Recognition》, 2015.: https://arxiv.org/abs/1512.03385: https://papers.nips.cc/paper/2012/file/c399862d3b9d6b76c8436e924a68c45b-Paper.pdf
A. Krizhevsky, I. Sutskever, G. E. Hinton, 《ImageNet Classification with Deep Convolutional Neural Networks》, 2012.
ResNet: Understanding the Building Blocks, Towards Data Science.

Responsible AI (책임 있는 인공지능):
Responsible AI란 인공지능(AI) 시스템이 사람과 사회에 해를 끼치지 않으며, 윤리적이고 투명하며 공정하게 작동하도록 설계, 개발, 배포, 운영하는 접근 방식이다. 
이는 단순히 기술적 성능을 넘어서, AI가 사회적 가치와 법적·윤리적 기준을 준수하도록 보장하려는 일련의 철학과 실행 원칙을 포함한다.

<배경과 등장 배경>
AI 기술의 급속한 발전과 확산은 사회적 책임에 대한 새로운 요구를 불러일으켰다. 
AI가 채용, 대출, 형사 사법 등 민감한 영역에서 결정에 영향을 미치기 시작하면서, 
공정성(fairness), 설명 가능성(explainability), 사생활 보호(privacy), 안전성(safety), 책임(accountability) 등의 가치가 AI 개발에서 핵심 고려 요소로 부상하였다. 
특히 2010년대 후반부터 주요 기술 기업과 학계, 국제기구들이 ‘책임 있는 AI’를 위한 원칙과 지침을 발표하기 시작했다1.

<핵심 원칙>
Responsible AI의 구현에는 일반적으로 다음과 같은 핵심 원칙이 포함된다.

공정성(Fairness): AI 시스템이 특정 집단이나 개인에게 차별적인 결과를 내지 않도록 해야 한다.
책임성(Accountability): AI가 야기한 결과에 대해 명확한 책임 주체가 존재해야 한다.
투명성(Transparency): AI의 작동 원리와 의사결정 과정은 이해 가능하고 설명 가능해야 한다.
안전성과 보안(Safety & Security): AI는 예측 불가능한 방식으로 작동하지 않도록 설계되어야 하며, 외부 공격에 견딜 수 있어야 한다.
프라이버시와 데이터 거버넌스(Privacy & Data Governance): 개인의 민감한 정보는 보호되어야 하며, 데이터의 수집·사용에 있어 적절한 통제가 필요하다.

<구현과 도전 과제>
Responsible AI를 구현하기 위해 조직들은 윤리 가이드라인을 수립하고, 알고리즘 편향을 제거하기 위한 평가 도구를 도입하며, 조직 내부에 AI 윤리 전담 부서를 설치하고 있다. 
하지만 실제로는 다음과 같은 도전 과제가 존재한다.

윤리 원칙이 실제 시스템 설계로 어떻게 구체화될 것인가에 대한 지침 부족
AI의 예측/결정 과정이 비직관적이거나 설명 불가능한 경우
이해관계자 간의 가치 충돌 (예: 효율성과 공정성 간의 긴장)
국제적 규범의 부재와 지역 간 기준의 불일치

<최신 동향>
2020년대 들어 각국 정부와 국제기구는 Responsible AI를 법제화하려는 시도를 본격화하고 있다. 
유럽연합(EU)은 2021년 AI법(AI Act) 초안을 공개하며 고위험 AI에 대한 엄격한 규제를 제안했고, 미국 국립표준기술연구소(NIST)는 AI 위험 관리 프레임워크를 발표하였다. 
동시에 Google, Microsoft, IBM 등 주요 기술 기업도 자사의 Responsible AI 프레임워크를 공개하고, 내부 툴과 평가 기준을 표준화하는 데 나서고 있다.

<참고 문헌 및 저작권>
Jobin, A., Ienca, M., & Vayena, E. (2019). The global landscape of AI ethics guidelines. Nature Machine Intelligence, 1(9), 389–399. https://doi.org/10.1038/s42256-019-0088-2
European Commission. (2021). Proposal for a Regulation on a European approach for Artificial Intelligence. https://eur-lex.europa.eu/legal-content/EN/TXT/?uri=CELEX%3A52021PC0206
National Institute of Standards and Technology. (2023). Artificial Intelligence Risk Management Framework (AI RMF 1.0). https://www.nist.gov/itl/ai-risk-management-framework

Rule-based system (규칙 기반 시스템):
규칙 기반 시스템(Rule-based system)은 특정 작업을 수행하기 위해 사전에 정의된 규칙이나 조건을 사용하는 컴퓨터 시스템이다. 
이러한 시스템은 "if-then" 규칙으로 구성되어 있으며, 입력 데이터에 대한 결정이나 추론을 하기 위해 이러한 규칙을 적용한다. 
규칙 기반 시스템은 주로 전문가 시스템, 자연어 처리, 데이터 분석 및 기타 분야에서 복잡한 결정 과정을 모델링하는 데 사용된다.

규칙 기반 시스템의 핵심은 명시적인 규칙에 의존한다는 것이다. 이러한 규칙은 도메인 전문가들에 의해 정의되거나, 특정 작업에 대한 지식을 반영하기 위해 설계된다. 
시스템은 주어진 입력에 대해 규칙을 순차적으로 평가하고, 해당 조건을 만족하는 규칙을 찾아 그에 따른 행동을 취한다. 
이 방식은 시스템의 결정 과정이 투명하고 예측 가능하다는 장점을 가지지만, 복잡한 문제에서 모든 가능한 상황을 규칙으로 정의하기 어렵고, 유연성이 부족할 수 있다는 단점도 있다.

규칙 기반 시스템은 인공 지능의 초기 형태 중 하나로서, 많은 전통적 AI 시스템과 전문가 시스템에서 중요한 역할을 했다. 
그러나 최근에는 머신러닝과 딥러닝 기반 접근 방식이 많은 분야에서 더 효과적이고 유연한 대안으로 자리잡고 있다.

<참고 문헌 및 저작권>
Jackson, P., 《Introduction to Expert Systems》, Addison-Wesley: https://www.pearson.com/en-us/search/Shop?aq=introduction%20to%20expert%20systems
Russell, S. and Norvig, P., 《Artificial Intelligence: A Modern Approach》, Prentice Hall: https://aima.cs.berkeley.edu/
Rule-based system - Wikipedia: https://en.wikipedia.org/wiki/Rule-based_system

random forest (랜덤 포레스트):
랜덤 포레스트(Random Forest)는 결정 트리의 앙상블로 구성된 머신러닝 알고리듬이다. 이 방법은 분류와 회귀 작업을 비롯해 다양한 머신러닝 문제에 사용될 수 있다. 
랜덤 포레스트는 여러 개의 결정 트리를 생성하고, 이 트리들의 결과를 평균내거나 다수결로 합쳐 최종 예측 결과를 도출한다.

랜덤 포레스트의 핵심적인 특징은 각 결정 트리가 훈련될 때 사용되는 데이터 샘플과 특성이 무작위로 선택된다는 것이다. 
이 무작위성은 결정 트리 간의 상관관계를 줄여주며, 이는 단일 결정 트리가 가질 수 있는 과적합 문제와 편향을 감소시킨다.

랜덤 포레스트의 장점으로는 과적합 위험이 낮고, 결측치나 높은 차원의 데이터에 강하며, 변수 중요도를 측정할 수 있다는 점 등이 있다. 
또한, 다양한 종류의 데이터와 복잡한 문제에 유연하게 적용될 수 있어 널리 사용된다. 
예를 들어, 의료 분야에서는 환자 데이터를 분석하여 질병을 진단하는 데 사용되기도 하고, 금융 분야에서는 사기 거래를 탐지하는 데 활용된다.

단점으로는 많은 수의 트리를 사용할 경우 모델의 훈련과 예측 속도가 느려질 수 있으며, 결과의 해석이 복잡해질 수 있다는 점이 있다. 
이러한 이유로, 실시간 시스템이나 요구 사항이 매우 엄격한 애플리케이션에서는 성능이 제한될 수 있다.

<참고 문헌 및 저작권>
IBM. What Is Random Forest? Retrieved from IBM: https://www.ibm.com/topics/random-forest
DeepAI. Random Forests Definition. Retrieved from DeepAI: https://deepai.org/machine-learning-glossary-and-terms/random-forest
Wikipedia. Random forest. Retrieved from Wikipedia: https://en.wikipedia.org
Built In. Random Forest: A Complete Guide for Machine Learning. Retrieved from Built In: https://builtin.com/data-science/random-forest-algorithm
CareerFoundry. What is Random Forest? [Beginner's Guide + Examples]. Retrieved from CareerFoundry: https://careerfoundry.com/en/blog/data-analytics/what-is-random-forest/

recommender systems (추천 시스템): https://wikidocs.net/120230

regression (회귀): 
회귀(Regression)란 종속 변수와 하나 이상의 독립 변수 사이의 관계를 모델링하는 통계적 기법이다. 이 기법은 독립 변수의 변화가 종속 변수에 어떻게 영향을 미치는지 설명하거나 예측하는 데 사용된다. 
예를 들어, 키와 체중 사이의 관계, 시간과 판매량 사이의 관계 등을 회귀 분석을 통해 파악할 수 있다.

회귀는 선형회귀(Linear Regression)와 로지스틱 회귀(Logistic Regression) 등 다양한 형태로 존재한다. 
선형 회귀는 독립 변수와 종속 변수 사이의 관계를 선형적으로 표현한 것이며, 로지스틱 회귀는 이진 분류 문제에서 주로 사용되며 독립 변수의 변화에 따라 결과가 특정 클래스에 속할 확률을 모델링한다.

<참고 문헌 및 저작권>
James, Gareth, et al., 《An Introduction to Statistical Learning》, Springer: https://link.springer.com/book/10.1007/978-1-4614-7138-7
Hastie, Trevor, et al., 《The Elements of Statistical Learning》, Springer: https://hastie.su.domains/ElemStatLearn/
Wikipedia - Regression Analysis: https://en.wikipedia.org/wiki/Regression_analysis

regression line (회귀직선): https://wikidocs.net/120320
2종류의 양적 데이터 X와 Y가 주어졌을 때, 변수 X의 값으로부터 변수 Y의 값을 예측하는 것을 생각해보자. 
이때, X를 설명변수(독립변수), Y를 목적변수(종속변수 또는 피설명변수)라고 부른다. 
2개의 변수에 직선관계가 예상되는 경우에, 이에 근사하는 직선을 회귀직선이라고 부른다. — Python으로 시작하는 빅데이터분석 및 인공지능 (개정판): https://www.infinitybooks.co.kr/product/item.php?it_id=1609745790&search=%EC%9D%B8%EA%B3%B5%EC%A7%80%EB%8A%A5&page=1&sort1=&sort2=

regularization (정규화, 정칙화, 규제화, 규칙화):
정규화(Regularization)란 기계학습에서 과적합(Overfitting)을 방지하기 위해 사용되는 기법이다. 
과적합은 모델이 학습 데이터에 지나치게 잘 맞춰져 있어 새로운 데이터에 대한 일반화 능력이 떨어지는 현상을 말한다. 
정규화는 모델의 복잡도를 제한하여 이러한 문제를 완화한다. 
가장 일반적인 정규화 기법으로는 L1 정규화(Lasso)와 L2 정규화(Ridge)가 있다.

L1 정규화는 모델의 가중치에 대한 절대값의 합을 손실 함수에 추가하며, 이는 모델의 일부 가중치를 정확히 0으로 만들어 특성 선택의 효과를 낸다. 
반면, L2 정규화는 가중치의 제곱의 합을 손실 함수에 추가하여, 모든 가중치가 0에 가까워지도록 만들지만 정확히 0이 되지는 않는다. 
이러한 정규화 기법들은 모델이 데이터의 중요한 패턴을 학습하면서도 과도하게 복잡해지는 것을 방지한다.

<참고 문헌 및 저작권>
Ng, A., 〈Feature selection, L1 vs. L2 regularization, and rotational invariance〉, Stanford University: https://ai.stanford.edu/~ang/papers/icml04-l1l2.pdf
James, G., Witten, D., Hastie, T., & Tibshirani, R., 《An Introduction to Statistical Learning》, Springer
Regularization (mathematics), Wikipedia 페이지: https://en.wikipedia.org/wiki/Regularization_(mathematics)

representation learning (표현 학습, 표상 학습): https://wikidocs.net/120224

residual (잔차): https://wikidocs.net/120321

residual connection (잔차 연결, 리지듀얼 커넥션): https://wikidocs.net/129665

response variable (반응 변수): https://wikidocs.net/177877

reward (보상): https://wikidocs.net/120356

rollout (롤아웃): https://wikidocs.net/170691
