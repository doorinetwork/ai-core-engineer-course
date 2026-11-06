# Day14 · 응용

**이 폴더의 README 하나로 01~08을 진행합니다.**

기본 결과는 소형 source Backbone 전이학습입니다. ImageNet ResNet18 성능이 아닙니다. 공식 ResNet18 경로는 최상위 README를 확인하세요.

## 파일 위치
Python 파일은 이 폴더에, 원본은 `data/`, 결과는 `outputs/`에 있습니다.

VS Code로 이 폴더를 열고 터미널에서 아래 명령을 실행하세요. 파일의 위치를 기준으로 경로를 잡으므로 다른 작업 폴더에서도 절대 경로로 실행할 수 있습니다.

**TODO를 채우지 않은 코드는 실행돼도 정답이 아닙니다.** 출력·구현을 함께 확인하세요. 시험용 정상 입력만 사용하며 불량 파일 처리 과제는 없습니다.

## 공통 실험 약속
`train`만 학습에 사용하고, `valid`에서 epoch·후보를 비교합니다. test는 클래스 매핑·중복 감사 외에 모델 학습·추론·설명·임계값 선택에 사용하지 않습니다. valid는 자연적인 입력·분포를 유지하고 무작위 재추출하지 않습니다.
`head`: 새 Head만 학습합니다. `partial`: 마지막 Conv(상위 단계는 해당 BatchNorm affine 포함)+Head를 학습합니다. `requires_grad`와 BatchNorm의 running 통계는 별개이며 기본 정책은 BN 통계 고정입니다.
모든 작은 모델은 RGB float `[0,1]`, 32×32 입력입니다. ImageNet의 Resize256→CenterCrop224→Normalize 경로와 섞지 않습니다.
Grad-CAM은 선택한 logit에 대한 반응 지도이지 원인·정답·탐지 박스가 아닙니다. 입력 32×32 좌표의 열지도를 같은 좌표의 이미지에 합성합니다.
오답이 없으면 `오답 0건`이라고 쓰고 이미지를 억지로 만들지 않습니다. 05·06의 초기 모델과 07의 최종 모델 결과를 구분합니다. 낮은 성능도 정확히 실행·해석하면 정답입니다.


## 실습 01 · 데이터셋 구조·분할·불균형 · PPT 15쪽

열 파일: `01_audit.py`. 직접 완성: A01

A01: 해당 라벨의 개수를 세세요.

```powershell
python 01_audit.py
```

**사용 함수·인자**
`ImageFolder(root, transform=None)`: **root 필수**, 이미지 변환 transform은 선택. `.class_to_idx`는 클래스 이름→번호, `.targets`는 파일 순서와 같은 라벨 목록입니다. `.samples`를 보는 것은 학습이 아닙니다.

**확인 출력 — 제공 CPU 환경의 정답 실행**
```text
split    class   n  ratio
train   circle 120 0.6667
train   square  40 0.2222
train triangle  20 0.1111
valid   circle  30 0.3333
valid   square  30 0.3333
valid triangle  30 0.3333
 test   circle  10 0.3333
 test   square  10 0.3333
 test triangle  10 0.3333
바이트 동일 중복 그룹: 0
```


**완료 기준**: TODO 구현, 위 수치·행 수·Shape와 대조, 생성 파일이 있다면 열어 확인.

**설명 질문**: 클래스 이름을 바꾸면 어떤 계약이 바뀌는가? train의 비율과 valid의 비율을 왜 따로 보는가?

내 설명:  
**클래스 이름을 바꾸면** ImageFolder가 하위폴더 이름을 읽어 알파벳 순으로 정렬한 순서를 깨뜨릴 수 있다. (이 실습에서, {circle: 0, square: 1, triangle: 2})  
클래스 이름이 바뀌어도 우연히 순서가 유지될 수 있지만, 순서가 바뀌는 경우 Head 출력 열의 의미와 이전 번호 순서대로 학습한 내용에 대한 해석이 모두 달라진다.  
**train 비율과 valid 비율을 따로 보는 이유**  
| 분할 | 실측 개수 | 비율 | 알려 주는 것 |
|:--|:--|:--|:--|
| train | [12, 6, 3] | 57% : 29% : 14% | 모델이 다수 클래스(circle) 쪽으로 기울 위험 |
| valid | [3, 3, 3] | 33% : 33% : 33% | 지표가 세 클래스를 같은 무게로 대표함 |
| test | [2, 2, 2] | 33% : 33% : 33% | 최종 평가용으로 남겨 둠 |

train 비율은 모델이 학습에서 받는 편향을 알려준다. valid 비율은 평가가 클래스마다 같은 비중인지 보여준다.  
두 비율을 따로 보지 않으면 불균형이 학습 쪽인지 평가 쪽인지 알기 어렵다.


## 실습 02 · 사전학습 Backbone·새 Head · PPT 25쪽

열 파일: `02_transforms.py`. 직접 완성: A02

A02: Weight가 제공하는 transforms()를 가져오세요.

```powershell
python 02_transforms.py
```

**사용 함수·인자**
`nn.Linear(in_features, out_features, bias=True)`: 입력·출력 수 **필수**, bias는 선택. `resnet18(*, weights=None, progress=True)`는 필수 위치 인자가 없으며 `weights`는 키워드 인자입니다. `np.load(file, allow_pickle=False)`는 배열 묶음을 읽는 제공 코드입니다. `.requires_grad`는 함수가 아니라 Parameter 속성입니다.

**확인 출력 — 제공 CPU 환경의 정답 실행**
```text
소형 source 입력: (3, 32, 32) 범위 [0,1]
공식 ResNet 입력: (3, 224, 224)
공식 Resize/Crop: [256] [224]
공식 mean/std: [0.485, 0.456, 0.406] [0.229, 0.224, 0.225]
작은 source와 ImageNet의 Normalize를 서로 섞지 않습니다.
```


**완료 기준**: TODO 구현, 위 수치·행 수·Shape와 대조, 생성 파일이 있다면 열어 확인.

**설명 질문**: 고정 Backbone과 새 Head는 각각 무엇을 학습하는가? 공식 ResNet18과 소형 source의 출처는 같은가?

내 설명:  
**고정 Backbone과 새 Head는 각각 무엇을 학습하는가?**  
Backbone은 사전학습된 가중치만 제공하고, 새 Head는 제공되는 256차원의 특징을 어떤 조합이 circle·square·triangle인지 가르는 결정 규칙만 학습한다.

**공식 ResNet18과 소형 source의 출처는 같은가?:** 같지 않다.  
공식 ResNet18은(ResNet18_Weights.IMAGENET1K_V1) ImageNet-1K 실사 사진으로 학습했고,  
소형 source는 source_provenance.json에 제시된 이미지들로부터 학습했다. (TinyShapeCNN)  


## 실습 03 · Freeze·Partial Fine-tuning · PPT 35쪽

열 파일: `03_finetune.py`. 직접 완성: A03

A03: Head-only, Partial 두 전략만 비교하세요. 데이터와 epoch는 고정합니다.

```powershell
python 03_finetune.py
```

**사용 함수·인자**
`AdamW(params, lr=..., weight_decay=...)`: **params 필수**, lr·weight_decay 선택. `zero_grad()`는 누적 기울기 초기화, `backward()`는 미분, `step()`은 실제 갱신입니다. `.eval()`은 gradient를 끄는 함수가 아닙니다.

**확인 출력 — 제공 CPU 환경의 정답 실행**
```text
strategy balance  params  best_epoch  accuracy  macro_f1  triangle_recall
    head    none     771           8    0.8111    0.8038           0.5000
 partial    none    1923           8    0.9556    0.9562           0.9333
시간은 finetune_comparison.csv에 기록: 기기별로 달라짐
```

숫자의 마지막 자릿수는 라이브러리·장치에 따라 달라질 수 있습니다. 시간은 정답으로 고정하지 않습니다.

**완료 기준**: TODO 구현, 위 수치·행 수·Shape와 대조, 생성 파일이 있다면 열어 확인.

**설명 질문**: requires_grad=False와 eval()은 어떤 점에서 다른가? partial은 어떤 층을 여는가?

내 설명:  
**requires_grad=False와 eval()은 어떤 점에서 다른가?**  
requires_grad=False는 그 파라미터의 기울기 계산·갱신을 끈다. `eval()`은 BatchNorm이 배치 통계 대신 저장된 running 통계를 쓰게 하고 Dropout을 끄는 모드 전환일 뿐, gradient를 끄지 않는다.  
**partial은 어떤 층을 여는가?**  
마지막 layer4와 Head를 연다.  


## 실습 04 · 클래스 불균형 대응 · PPT 47쪽

열 파일: `04_weight.py`. 직접 완성: A04

A04: 같은 head 모델에서 none, weight 두 조건을 비교하세요.

```powershell
python 04_weight.py
```

**사용 함수·인자**
`f1_score(y_true, y_pred, average="macro", labels=[0,1,2], zero_division=0)`: 실제값·예측값 **필수**, 나머지는 선택 옵션. macro는 클래스별 F1의 동일 가중 평균입니다. `CrossEntropyLoss(weight=...)`는 train 손실에만 클래스 가중치를 적용합니다.

**확인 출력 — 제공 CPU 환경의 정답 실행**
```text
train class_weights: [0.30000001192092896, 0.9000000357627869, 1.8000000715255737]
strategy balance  params  best_epoch  accuracy  macro_f1  triangle_recall
    head    none     771           8    0.8111    0.8038              0.5
    head  weight     771           8    1.0000    1.0000              1.0
```


**완료 기준**: TODO 구현, 위 수치·행 수·Shape와 대조, 생성 파일이 있다면 열어 확인.

**설명 질문**: Accuracy는 높고 minority Recall은 0일 수 있는가? weight와 sampler는 무엇을 각각 바꾸는가?

내 설명:  
**Accuracy는 높고 minority Recall은 0일 수 있는가?**  
가능하다. 다수 클래스가 대부분인 데이터에서 다수 클래스만 예측하면 Accuracy는 높고 소수 Recall은 0이 된다.  
**weight와 sampler는 무엇을 각각 바꾸는가?**  
weight는 데이터를 그대로 두고 손실에서 클래스별 비중을 바꾼다. sampler는 손실식을 그대로 두고 배치에 뽑히는 빈도를 바꾼다.  

## 실습 05 · 평가·오류 이미지 분석 · PPT 57쪽

열 파일: `05_errors.py`. 직접 완성: A05

A05: 실제값과 예측값이 다른 행의 인덱스를 구하세요.

```powershell
python 05_errors.py
```

**사용 함수·인자**
`confusion_matrix(y_true, y_pred, labels=[0,1,2])`: **실제값·예측값 필수**, labels는 선택이지만 이 수업에서는 순서 고정. 행=실제, 열=예측. `classification_report`의 target_names는 labels와 같은 순서입니다. 분모 0을 0으로 보고하는 정책을 명시합니다.

**확인 출력 — 제공 CPU 환경의 정답 실행**
```text
전체 오답: 0 저장: 0 없으면 생성하지 않음
```


**완료 기준**: TODO 구현, 위 수치·행 수·Shape와 대조, 생성 파일이 있다면 열어 확인.

**설명 질문**: 오답 이미지 하나의 실제·예측·확률을 근거로 관찰과 가설을 나누어 적어라. 오답이 없을 때는 어떻게 보고하는가?

내 설명: ______________________________


## 실습 06 · Grad-CAM·편향 가설 · PPT 68쪽

열 파일: `06_cam_targets.py`. 직접 완성: A06

A06: target logit의 features에 대한 gradient를 계산하세요.

```powershell
python 06_cam_targets.py
```

**사용 함수·인자**
`torch.autograd.grad(outputs, inputs)`: 미분할 scalar·대상 Tensor **필수**. 입력을 수정하지 않고 gradient tuple을 반환합니다. `.mean(dim=(2,3), keepdim=True)`는 공간 평균. `cv2.addWeighted(src1, alpha, src2, beta, gamma)`는 앞의 다섯 인자 **필수**, 같은 좌표·크기의 BGR 이미지끼리 합성합니다.

**확인 출력 — 제공 CPU 환경의 정답 실행**
```text
target: circle logit: 1.5821 mean CAM: 0.1275
target: square logit: -1.351 mean CAM: 0.1719
```


**완료 기준**: TODO 구현, 위 수치·행 수·Shape와 대조, 생성 파일이 있다면 열어 확인.

**설명 질문**: Heatmap의 target은 무엇인가? 같은 이미지에서 target이 바뀌면 지도가 달라질 수 있는가?

내 설명:  
**Heatmap의 target은 무엇인가?**  
미분 대상으로 고른 logit의 클래스다.  
**같은 이미지에서 target이 바뀌면 지도가 달라질 수 있는가?**  
달라질 수 있다. 채널 가중치가 target logit의 gradient로 정해지므로, 같은 features라도 target마다 다른 채널이 양으로 기여한다. square logit이 음수여도 그 logit을 키우는 쪽으로 반응한 위치가 표시된다.  

## 실습 07 · 전이학습 프로젝트 · PPT 78쪽

열 파일: `07_project.py`. 직접 완성: A07, A08

A07: Head 기준선·Partial·Head+weight 세 조건을 고정하세요.
A08: 실제 y_valid와 pred를 표에 넣으세요. valid.samples와 같은 순서입니다.

```powershell
python 07_project.py
```

**사용 함수·인자**
`DataFrame.to_csv(path, index=False)`: 여기서는 출력 경로를 명시합니다. `torch.save(obj, path)`는 **저장 객체·경로 필수**. 복원할 때는 본인이 생성한 파일에만 `torch.load(..., weights_only=True)`를 사용합니다. 기본필수는 모델 파일 저장을 요구하지 않습니다.

**확인 출력 — 제공 CPU 환경의 정답 실행**
```text
strategy balance  params  best_epoch  accuracy  macro_f1  triangle_recall
    head    none     771           8    0.8111    0.8038           0.5000
 partial    none    1923           8    0.9556    0.9562           0.9333
    head  weight     771           8    1.0000    1.0000           1.0000
예측 행: 90 오답: 0 test 사용: False
```

숫자의 마지막 자릿수는 라이브러리·장치에 따라 달라질 수 있습니다. 시간은 정답으로 고정하지 않습니다.

**완료 기준**: TODO 구현, 위 수치·행 수·Shape와 대조, 생성 파일이 있다면 열어 확인.

**설명 질문**: 어떤 입력·설정·seed·매핑을 고정해야 재실행 결과를 비교할 수 있는가? test를 왜 남겨 두는가?

내 설명:  
**어떤 입력·설정·seed·매핑을 고정해야 재실행 결과를 비교할 수 있는가?**

| 고정 대상 | 이 프로젝트의 값 | 바뀌면 생기는 일 |
|:--|:--|:--|
| 입력 데이터 | `data/` train 180·valid 90, 원본 덮어쓰기 없음 | 다른 데이터로 학습·평가 |
| source 배열 | `source_backbone.npz` (sha256 `fdedd0b6…29f4`, provenance와 일치) | 출발점이 다른 전이학습 |
| 입력 변환 | Resize(32,32) + ToTensor, Normalize 없음 | 입력 분포 변화 |
| 클래스 매핑 | `{circle:0, square:1, triangle:2}` | 번호·triangle_recall 의미 변화 |
| seed·스레드 | `torch.manual_seed(14)`(후보마다 재고정), `set_num_threads(1)` | Head 초기값·연산 순서 변화 |
| 후보·학습 설정 | 3후보, AdamW lr 0.003·wd 0.0001, 8 epoch, 전체 1배치 | 비교 기준 변화 |
| 학습 범위·BN | requires_grad(Head / +model[4]), `eval()`로 BN 통계 고정 | 학습 파라미터·BN 통계 변화 |
| 선택 규칙 | valid 손실(가중치 없음) 최소 epoch | 다른 epoch 선택 |
| 출력 순서 | `valid.samples` 순서(파일 이름순) | 행 단위 비교 불가 |

**test를 왜 남겨 두는가?**

valid는 이미 **epoch 선택**(손실 최소 epoch)과 **후보 비교**(세 후보 중 어느 것이 나은지)에 쓰였다. 선택에 쓴 데이터의 성능은 그 선택에 맞춰진 값이라 실제보다 좋게 보일 수 있다. 이번에도 head/weight가 valid 1.0000이었지만, 이것이 처음 보는 데이터에서도 1.0이라는 근거는 아니다. test를 학습·추론·임계값 선택 어디에도 쓰지 않고 남겨 두어야, 모든 결정을 끝낸 뒤 **한 번만** 평가해 일반화 성능을 정직하게 보고할 수 있다. 이 프로젝트는 test를 열지 않았다(`test 사용: False`).  

## 실습 08 · 같은 프로젝트 재현 (PPT 83쪽)
07번 파일을 다시 실행합니다. 원본 data가 바뀌지 않았는지, metrics·predictions의 행 순서·값이 같은지 확인합니다.
최종 모델에 오답이 없으면 05·06의 초기 모델 오류와 분리하여 보고합니다. 마지막에 없는 오류를 만들거나 라벨을 바꾸지 않습니다.

| 기록 | 직접 작성 |
|---|---|
| 사용 모델·source 출처 | |
| train/valid 클래스 개수 | |
| 학습 범위·BN 정책 | |
| 주 지표와 이유 | |
| 관찰한 오류·CAM target | |
| 재실행 확인·한계 1개 | |

**07 생성 파일**: `metrics.csv`, `predictions.csv`, `history.csv`, `confusion.csv`, `project_cam.png`, 실제 오답이 있으면 `project_error_*.png`. 기본필수는 `metrics.json`도 생성합니다. 응용의 비교표는 세 후보를 포함하며 `predictions.csv`는 마지막 head+weight 후보의 예측입니다.
**06 생성 파일**: 기본 `cam_correct.png`·`cam_wrong.png`(해당 사례가 있을 때), 응용 `target_0_cam.png`·`target_1_cam.png`.

## 자주 막히는 지점
- 파일을 못 찾는 경우: ZIP 안에서 실행하지 말고 전체 압축을 푼 뒤 실행합니다. data를 삭제하지 않습니다.
- 같은 파일이 실행되는데 출력이 다른 경우: TODO, seed, source 배열, split, mode를 순서대로 확인합니다.
- Grad-CAM이 전부 0인 경우: 그 target의 양의 가중 반응이 없을 수 있습니다. 무조건 예쁜 열지도로 바꾸지 않습니다.
- `eval()` 안에서도 미분은 가능하지만 `inference_mode()`에서는 Grad-CAM을 계산하지 않습니다.
- 공식 ResNet18을 실행할 때는 Weight 사전 준비가 별도 필요합니다. 소형 source 실습은 다운로드 없이 진행합니다.

## 환경 준비
전날 쓰던 가상환경을 그대로 사용합니다. VS Code에서 현재 난이도 폴더를 **폴더 열기**로 엽니다.
```powershell
python -c "import torch, torchvision, cv2; print(torch.__version__, torchvision.__version__, cv2.__version__)"
```
필요한 패키지는 `torch`, `torchvision`, `numpy`, `pandas`, `scikit-learn`, `opencv-python`, `Pillow`입니다.
`torch`·`torchvision`은 [PyTorch 공식 설치 선택기](https://pytorch.org/get-started/locally/)의 서로 호환되는 조합을 설치합니다. GPU용 설치를 CPU판으로 임의 덮어쓰지 않습니다.
나머지가 없을 때만 다음을 실행합니다.
```powershell
python -m pip install numpy pandas scikit-learn opencv-python Pillow
```
`opencv-python`과 `opencv-python-headless`를 동시에 새로 설치하지 않습니다. 이미 정상 import되면 재설치하지 않습니다.
검증 환경: Python 3.13.5, torch 2.10.0+cpu, torchvision 0.25.0+cpu, numpy 2.3.5, pandas 2.2.3, sklearn 1.8.0, OpenCV 4.13.0, Pillow 12.3.0, Linux. Windows·macOS와 실제 GPU는 미검증입니다.

## 공식 참고자료
- [Torchvision ResNet18: Weight와 transforms](https://docs.pytorch.org/vision/stable/models/generated/torchvision.models.resnet18.html)
- [PyTorch 전이학습 튜토리얼](https://docs.pytorch.org/tutorials/beginner/transfer_learning_tutorial.html)
- [CrossEntropyLoss: 가중 평균의 분모](https://docs.pytorch.org/docs/2.10/generated/torch.nn.CrossEntropyLoss.html)
- [DataLoader·WeightedRandomSampler](https://docs.pytorch.org/docs/2.10/data.html)
- [Module: train/eval·requires_grad·hook](https://docs.pytorch.org/docs/2.10/generated/torch.nn.Module.html)
- [classification_report](https://scikit-learn.org/stable/modules/generated/sklearn.metrics.classification_report.html)
- [Grad-CAM 원 논문](https://arxiv.org/abs/1610.02391)
기술 문서의 최신 버전 표기와 아래 실제 검증 환경을 혼동하지 않습니다.
