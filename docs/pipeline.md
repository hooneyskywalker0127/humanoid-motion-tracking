# 파이프라인

[← README](../README.md)

![pipeline](pipeline.png)

1-3단계에는 물리가 없습니다. 자세를 계산하고 그중 쓸 것을 고르는 구간입니다.
물리는 4단계에서 들어오고, 거기서부터 로봇이 스스로 버텨야 합니다.

## 1단계. 사람 Motion Capture 데이터

![1단계](stage_1.png)

사람 몸의 관절이 매 순간 어디에 있었는지를 숫자로 기록한 데이터입니다.
영상이 아니라 "0.1초 시점에 왼쪽 무릎은 여기, 오른쪽 팔꿈치는 여기" 같은
좌표의 나열입니다.

진행 상황: LAFAN1 77개 시퀀스를 확보했습니다. 30 fps bvh, 배우 5명, 4.6시간입니다.

## 2단계. Retargeting

![2단계](stage_2.png)

사람 기준의 관절값을 G1에 그대로 쓸 수는 없습니다. 팔다리 길이가 다르고,
관절이 꺾이는 축도 다르며, 사람에게 있는 관절이 로봇에는 없기도 합니다.
그래서 "어깨 각도 몇 도"를 복사하는 대신, 손끝과 발끝 위치처럼 지켜야 할
것을 정해 두고 그것을 최대한 만족하는 로봇 관절값을 최적화로 찾습니다.
로봇의 관절 한계를 넘지 않아야 하고, 발이 바닥을 뚫거나 뜨지 않아야 합니다.

![retargeting](retargeting.gif)

주황색이 원본 사람 골격, 회색이 Retargeting된 G1입니다. 위아래 띠에 이 작업을
어렵게 만드는 팔다리 길이 차이와, 로봇의 각 부위가 IK 목표에서 몇 cm
떨어졌는지를 같이 넣었습니다. 이 영상에서 로봇이 걷고 있는 것은 아닙니다.
매 프레임 관절값을 모델에 직접 써넣고 그린 것이고, 시뮬레이션 스텝은
한 번도 돌지 않았습니다.

진행 상황: [GMR](https://github.com/YanjieZe/GMR)로 77개 전부 Retargeting했습니다.
총 496,672 프레임입니다. 전수 검증했습니다. NaN이나 무한대 없음, 29개 관절
어디에도 한계 위반 없음, 프레임 수는 원본 bvh와 정확히 일치합니다.

## 3단계. Reference Motion

![3단계](stage_3.png)

Retargeting 결과가 로봇이 따라가야 할 목표 궤적이 됩니다. 이 단계까지는
아직 로봇이 실제로 움직인 것이 아니라, 따라야 할 정답 동작만 만들어진
상태입니다.

Retargeting했다고 다 학습에 쓸 수 있는 것은 아닙니다. 여기서 쓰는 척도는 로봇의
각 부위가 GMR의 IK가 겨냥한 목표에서 몇 cm 떨어졌는지입니다. 골반과 양 발목,
양 손목만 봅니다. 몸통과 어깨, 고관절은 위치 가중치가 0-5라 GMR이 위치를
맞추지 않고, MuJoCo 바디 원점이 사람 관절 중심과 달라 상수 오프셋이 섞입니다.

동작 종류별 발 오차입니다. 단위는 cm입니다.

```
walk         12개  1.00      obstacles      17개  1.65
dance         8개  1.25      sprint          2개  1.67
aiming        5개  1.27      fallAndGetUp    6개  2.11
run           4개  1.33      ground          5개  2.76
```

걷기가 가장 깨끗하고 바닥 동작이 가장 나쁩니다. 세 배 차이입니다. 넘어지고
눕는 동작은 발 말고도 닿는 부위가 많은데, 발에 가중치를 둔 IK는 그런 상황을
상정하지 않습니다. 손 오차는 동작 종류와 무관하게 5-9 cm입니다. 개별 동작의
실패가 아니라 팔 길이 차이라서 선별 기준으로는 쓰지 않습니다.

진행 상황: 발 오차 세 조건을 모두 만족하는 19개를 골랐습니다. 평균 1.2 cm
미만, p95 3.5 cm 미만, 최대 10 cm 미만입니다. 목록은
[`configs/selected_motions.txt`](../configs/selected_motions.txt)에 있습니다.
각각을 BeyondMimic이 읽는 50 fps npz로 변환했습니다. 이 변환이 Policy 학습에
필요한 링크 속도를 만들어냅니다. 변환 결과는 W&B registry에 올렸습니다.

문턱값 자체는 원칙에서 나온 것이 아닙니다. 19개가 남는 지점을 골랐고, GMR
논문이 21개로 실험한 것과 비슷한 규모라는 게 근거입니다. 학습을 돌려 실패하는
시퀀스가 어느 오차대에 몰리는지 보면 그때는 근거 있는 문턱을 정할 수 있습니다.

## 4단계. 모션 트래킹 Policy 학습

![4단계](stage_4.png)

RL로 로봇이 그 목표를 따라가게 만듭니다. Reference Motion에 가까우면
점수를 주고, 벗어나거나 넘어지면 점수를 깎습니다. 이 과정을 반복해 로봇이
찾아낸 조종 방법이 Policy이고, 점수 규칙이 Reward입니다.
평가 기준은 "그럴듯하게 걷는가"가 아니라 "Reference를 얼마나 정확히
따라갔는가"입니다.

학습에는 [BeyondMimic](https://github.com/HybridRobotics/whole_body_tracking)을
씁니다. GMR 논문이 Policy 학습에 쓴 것과 같습니다. 모션 하나당 Policy 하나를
학습하므로 19개 시퀀스는 학습 19회를 뜻합니다. 환경 4096개, 30000회 반복, PPO입니다.

그 저장소는 IsaacSim 4.5, IsaacLab 2.1.0 기준입니다. 로컬의 IsaacSim 5.1,
IsaacLab 2.3.2, rsl-rl 3.1.2에서 돌리려면 인터페이스 세 곳을 고쳐야 합니다.
학습 로직과는 무관합니다. `csv_to_npz.py`가 저장 뒤에도
`while simulation_app.is_running()` 루프를 빠져나오지 않아 `--headless`에서
끝나지 않는 것, `isaaclab.utils.io`에서 `dump_pickle`이 사라진 것, rsl-rl 3.x가
정규화기를 러너에서 Policy 안으로 옮긴 것입니다.

학습한 Policy를 재생하려면 같은 저장소의 `scripts/rsl_rl/play.py`에서 두 곳을
더 고쳐야 합니다. `--motion_file`이 W&B 분기에서만 읽혀 로컬 체크포인트로
돌리면 Reference Motion이 비고, `get_observations()`가 반환하는 TensorDict를
기존 튜플 언패킹이 배치 차원으로 쪼개 관측이 1차원이 됩니다.

진행 상황: 첫 Policy walk2_subject4를 30000회까지 학습했습니다. RTX 5080에서
8시간 38분 걸렸습니다.

![tracking](tracking.gif)

위 이미지는 그중 6초입니다. 전체 길이는 3분 58초입니다.

## 5단계. Policy Distillation

![5단계](stage_5.png)

4단계까지 하면 모션 하나당 Policy 하나가 남습니다. 14개 동작을 시키려면 Policy
14개를 들고 있다가 골라 써야 합니다. 5단계는 그 14개를 Policy 하나로 합칩니다.

방법은 Distillation입니다. 학습된 Policy 14개를 Teacher로 두고, Student
하나가 시뮬레이터를 직접 굴러다니면서 매 순간 "너라면 어떻게 했겠냐"를
Teacher에게 물어 그 답을 따라 합니다. Teacher가 다닌 길만 베끼면 Student가 조금
벗어났을 때 돌아올 줄 모르기 때문에, Student를 먼저 굴리고 그 자리에서 라벨을
받습니다. 이 방식을 DAgger라고 합니다.

Distillation 코드는 [HOVER](https://github.com/NVlabs/HOVER)의
`neural_wbc/student_policy`를 그대로 씁니다. 트레이너, Student 네트워크, 버퍼,
손실을 손대지 않았고 패키지 내부 import 경로만 고쳤습니다. HOVER는 IsaacLab과
rsl-rl을 쓰므로 이 저장소와 스택이 같습니다.

HOVER는 Teacher가 하나인 구조라 한 곳을 바꿨습니다. 트레이너가 Teacher에게 관측
텐서 하나만 넘기기 때문에(`student_policy_trainer.py`) 어느 Teacher를 쓸지 알릴
통로가 관측밖에 없습니다. 그래서 Teacher 관측 맨 뒤에 모션 인덱스를 한 칸 붙이고,
Teacher 쪽 구현이 그걸 떼어 env별로 담당 Teacher를 고릅니다. 관측에 선택자를 실어
보내는 방식은 [parkour](https://github.com/ZiwenZhuang/parkour)의
`ActorCriticFieldMutex`가 쓰는 것과 같습니다.

Student에게는 모션 인덱스를 주지 않습니다. 주면 클립 번호를 외워버리고 Reference를
안 보게 됩니다. 학습에 쓰지 않은 모션도 따라가게 하려면 Reference만으로
판단해야 합니다.

Teacher 관측은 161차원(Reference 관절 58 + Anchor 오차 9 + 고유수용성 93 + 모션
인덱스 1), Student 관측은 260차원입니다. Student에게는 Teacher에게 없는 항 100개가
더 붙습니다 — Reference와 현재 상태의 관절각 차분 29, 관절속도 차분 29,
Anchor 프레임에서의 바디 위치 차분 42입니다. OpenTrack Student가 Reference를
원본이 아니라 차분으로 받는 것을 따랐습니다. 원본만 주면 네트워크가 뺄셈부터
배워야 합니다.

Teacher는 전부 [512, 256, 128]이고 Student는 [2048, 2048, 1024, 1024, 512]입니다.
**이 용량이 결과를 갈랐습니다.** 처음에는 [1024, 512, 256]으로 했는데 14개
중 한 클립만 완주 9%로 남았습니다. 가설을 열여섯 개 세워 하나씩 반증한 끝에
원인이 용량이었습니다 — 학습 에피소드를 10초에서 40초로 늘리고 망을 4배로
키우자 최저 클립이 98.4%가 되었습니다. BumbleBee 논문이 3층 MLP로는 여러
Teacher를 담지 못한다고 적어둔 것이 이 지점입니다.

Teacher로 쓴 것은 14개입니다. 학습한 17개 중 Success Rate 0%인 셋은 완주한 rollout이
없어 Teacher로 쓸 궤적 자체가 없습니다. kobe는 일반화를 볼 대조군으로 빼두었습니다.

### 다중 클립 지원

4단계 환경은 npz 하나만 물 수 있습니다. Distillation은 Student가 14개 클립을 다 겪어야
하므로 세 곳을 고쳤습니다.

`MotionLoader`가 npz 리스트를 받으면 시간축으로 이어 붙이고 클립 경계를 따로
들고 있습니다. 패딩하지 않습니다. 시간 인덱스가 계속 "이어 붙인 배열에 대한
평탄 인덱스"로 남기 때문에 기존 인덱싱과 Anchor 변환 코드가 그대로 동작합니다.
이 배치 방식은 PHC, ProtoMotions, SONIC이 모두 같은 형태로 씁니다.

env마다 지금 따라가는 클립 번호는 따로 저장하지 않고 시간 인덱스를 클립
경계로 이진탐색해서 냅니다. 따로 들고 있으면 어긋날 수 있기 때문입니다.

그리고 클립별 샘플링 확률에 상한을 뒀습니다. 실패 기반 적응 샘플링만 켜두면
어려운 클립 하나로 확률이 쏠려 쉬운 클립을 잊습니다. SONIC이 같은 이유로
`max_prob_per_motion`을 두고, 다양성이 중요한 학습에는 공평 몫의 2배 정도를
쓴다고 적어두었습니다. 여기서도 2배를 기본값으로 했습니다.

이 상한이 필요한 이유가 하나 더 있습니다. 14개 클립의 전체 프레임 중 walk이
67%(107,777 / 162,049)입니다. 상한 없이 균등하게 뽑으면 Student가 걷기에
치우칩니다.

### 결과 — 열넷을 하나로 합쳤고 정확도가 깎이지 않았습니다

64 rollout, Domain Randomization 끔, 클립 전체 길이 기준입니다.

| | Success Rate | E_g-mpbpe | E_mpbpe | E_mpjpe |
|---|---|---|---|---|
| Teacher 14개 (각자 자기 클립) | 99.0% | 102mm | 42mm | 0.084 |
| **Student 하나** | **99.7%** | **90mm** | **41mm** | **0.082** |

양쪽 다 100 rollout, 같은 조건, 같은 평가 코드입니다. **여섯 지표 전부에서
Student가 같거나 낫습니다.** 14개 중 11개가 100% 이고 나머지 셋
(walk1_subject1·walk2_subject3 99%, jumps1_subject1 98%)도 98% 위이며, E_g-mpbpe 는 14개 전부 Student가
낮습니다(평균 12mm 차이).

딸려 나온 것이 셋입니다.

- **sim-to-sim** — 같은 ONNX를 재학습·게인 재조정 없이 MuJoCo에 넣어
  14개 중 12개가 완주합니다. 전역 오차는 5-20% 늘지만 Anchor 정렬 오차는
  오히려 MuJoCo가 낮습니다. 자세는 잘 따라가고 전역 드리프트만 쌓인다는 뜻입니다.
- **Domain Randomization** — 1-3초마다 밀치고 마찰·몸통 무게중심·관절 영점·리셋
  자세를 무작위로 바꾼 조건에서 평균 76.1%입니다. 동적인 동작일수록 많이
  떨어집니다(달리기 43.8%, walk4 98.4%).
- **모션 전환** — 클립 경계에서 로봇을 리셋하지 않고 Reference만 다음 클립으로
  바꿔도 13개 전환 중 6개가 넘어갑니다. Teacher 14개로는 구조적으로 못 하는
  일입니다. Policy를 갈아끼우는 순간 로봇이 새 Policy가 겪어 본 적 없는 상태에
  있기 때문입니다.

### 되지 않는 것도 쟀습니다

LAFAN1의 나머지 63개를 전부 Retargeting해 같은 Policy로 돌렸습니다. 학습은
하지 않았습니다. 분할은 SONIC 방식을 따랐습니다. 이 표는 **64 rollout**입니다
(위의 Teacher 대조표는 100). Success Rate는 rollout 수와 환경 개수에 둔감한 것으로
확인했습니다 — 같은 클립을 환경 32/64/128/256으로 재면 2%p 안에 들어옵니다.

| 무엇 | 클립 | Success Rate | 생존율 |
|---|---|---|---|
| 학습한 14클립 | 14 | 99.89% | 100% |
| test-repetition — 학습에 **있던** 동작군, 없던 테이크 | 35 | 0.0% | 13.4% |
| test-content — 학습에 **없던** 동작군 | 28 | 0.0% | 8.6% |

**63개 중 한 개도 끝까지 가지 못합니다.** 동작군 순서가 학습 분포와의 거리를
그대로 따릅니다 — walk 48.9% > aiming 22.1% > dance 15.7% > run 13.8% >
obstacles 5.1% > jumps 1.4%, 그리고 눕거나 접촉이 많은 fight·ground·
fallAndGetUp은 3-5%가 바닥입니다.

다만 14클립은 GMT(8,925클립)나 SONIC(317,189클립)보다 자릿수가 셋 아래입니다.
이 규모에서 일반화는 처음부터 나올 수 없습니다. Reference를 조건으로 받는
구조(motion-conditioned)는 일반화의 **필요조건이지 충분조건이 아닙니다.**

### 교란 아래에서는 Teacher가 낫습니다

위의 "정확도가 안 깎였다"는 깨끗한 조건에서 잰 값입니다. 밀치기만 켜고
세기를 바꿔 가며 Teacher와 Student를 같은 조건에 놓으면 결과가 뒤집힙니다.

| 밀치기 세기 | Teacher 14개 | Student |
|---|---|---|
| 학습 때와 같은 세기 | 91.0% | 84.3% |
| 두 배 | 31.7% | 23.3% |

다만 E_g-mpbpe는 Student가 14개 중 11개에서 더 낮습니다. 자세 추적 자체는 여전히
통합 쪽이 낫고, **밀렸을 때 되돌아오는 능력만** 떨어집니다. Distillation이 Teacher의
평균 행동을 배우고 밀린 상태에서의 복구 행동은 데이터에 드물어 덜 배운다는
설명이 그럴듯하지만, 확인하지는 않았습니다. DAgger rollout에 교란을 넣으면
달라질 수 있습니다.

## ▶ 전체 영상 (YouTube)

[![전체 영상 재생](youtube_thumb.jpg)](https://youtu.be/l1M4y_Nl7oc)

위 이미지를 누르면 YouTube에서 재생됩니다 — https://youtu.be/l1M4y_Nl7oc

왼쪽이 물리 위에서 도는 학습된 Policy, 오른쪽이 따라가야 할 Reference입니다.
두 화면 모두 Isaac Sim이고 조명과 카메라가 같으며, 같은 모션 프레임에서
시작해 11,909 프레임 전체를 돌립니다. 두 화면이 픽셀 단위로 겹치지는
않습니다. 리셋마다 초기 자세에 랜덤이 들어가고, 왼쪽 로봇은 스스로 버텨야
하는 반면 오른쪽은 프레임마다 자세를 써넣은 것이기 때문입니다.

## ▶ 학습 경과 (YouTube)

[![학습 경과 재생](youtube_thumb_progression.jpg)](https://youtu.be/qQw8PtmXV9s)

위 이미지를 누르면 YouTube에서 재생됩니다 — https://youtu.be/qQw8PtmXV9s

같은 학습의 체크포인트 다섯 개와 Reference를 한 화면에 놓은 것입니다. 모션과
시작 프레임, 카메라가 모두 같습니다. 평균 Reward는 1,000회에서 14.67,
5,000회 30.80, 10,000회 33.49, 20,000회 36.63, 30,000회 36.80입니다. 상승분
대부분이 앞쪽에서 나오고, 뒤로 갈수록 숫자보다 얼마나 오래 버티는지에서
갈립니다.

## ▶ Domain Randomization (YouTube)

[![Domain Randomization 재생](youtube_thumb_randomization.jpg)](https://youtu.be/d61rKk675qY)

위 이미지를 누르면 YouTube에서 재생됩니다 — https://youtu.be/d61rKk675qY

![randomization](randomization.gif)

위는 그중 6초입니다. 왼쪽이 Domain Randomization을 켠 조건에서 도는 Policy, 오른쪽이
Reference입니다. 1-3초마다 무작위로 밀치고, 마찰과 몸통 무게중심, 관절 오프셋,
리셋 자세에도 랜덤이 들어갑니다.

밀치기는 몸통 속도에 값을 더하는 이벤트라 그대로 두면 화면에 아무것도 보이지
않습니다. 그래서 값이 들어간 순간 맞은 지점에 표시를 찍고, 미는 방향으로
화살표를 그리고, 더해진 속도를 함께 적었습니다. 화살표는 1초 동안 남습니다.

Domain Randomization를 켜면 Policy가 Reference에서 벗어나거나 에피소드가 끊길 수 있습니다.
그때는 0프레임부터 다시 시작하므로 좌우 위상이 어긋납니다. 그것도 결과의
일부입니다.

## 평가 기준

Policy를 재는 방식은 GMR 논문([arXiv:2510.02252](https://arxiv.org/abs/2510.02252))을
따릅니다. 같은 데이터셋과 같은 학습 프레임워크를 쓰는 연구라 수치를 나란히
놓을 수 있습니다.

| 지표 | 뜻 |
| --- | --- |
| Success Rate | Anchor 바디의 높이·방향이 임계를 넘지 않고 클립 끝까지 간 rollout의 비율 |
| E_g-mpbpe | 전역 좌표에서 바디 위치 오차의 평균 (mm) |
| E_mpbpe | Anchor 기준으로 정렬한 상대 바디 위치 오차의 평균 (mm) |
| E_mpjpe | 관절 각도 오차의 평균 (rad) |
| E_mpbve | 바디 속도 오차의 평균 (mm/frame) |
| E_mpbae | 바디 가속도 오차의 평균 (mm/frame²) |

측정은 `scripts/eval_all.sh`가 하고, 표는 `src/eval_table.py`가 만듭니다.
Domain Randomization을 끈 조건이 기본이고 `--randomize`로 켤 수 있습니다. 논문이
sim과 sim-dr을 나눠 보고하는 방식과 같습니다.

선별한 19개 중 17개를 30,000 iteration까지 학습하고 rollout 100회로 평가했습니다.
발 오차와 Success Rate를 나란히 놓아, Retargeting 품질이 Policy가 버티는지를 예측하는지
봅니다.

| 시퀀스 | 발 오차 (cm) | Success Rate | E_g-mpbpe (mm) | E_mpbpe (mm) | E_mpjpe (rad) |
| --- | --- | --- | --- | --- | --- |
| walk4_subject1 | 0.88 | 100% | 60 | 37 | 0.062 |
| walk3_subject2 | 0.99 | 100% | 79 | 34 | 0.071 |
| walk1_subject2 | 1.05 | 100% | 79 | 34 | 0.066 |
| walk3_subject5 | 1.11 | 100% | 85 | 36 | 0.082 |
| aiming1_subject1 | 0.74 | 100% | 89 | 35 | 0.080 |
| walk1_subject5 | 1.12 | 100% | 90 | 34 | 0.069 |
| dance2_subject3 | 0.94 | 100% | 103 | 45 | 0.104 |
| walk2_subject1 | 0.91 | 100% | 114 | 43 | 0.101 |
| walk1_subject1 | 0.80 | 99% | 80 | 34 | 0.066 |
| walk2_subject4 | 0.70 | 99% | 90 | 40 | 0.085 |
| run2_subject4 | 1.12 | 99% | 178 | 47 | 0.111 |
| jumps1_subject1 | 1.10 | 98% | 151 | 42 | 0.104 |
| obstacles3_subject3 | 1.19 | 98% | 162 | 54 | 0.101 |
| walk2_subject3 | 1.15 | 96% | 129 | 50 | 0.104 |
| walk3_subject4 | 0.88 | 0% | - | - | - |
| obstacles2_subject1 | 0.93 | 0% | - | - | - |
| walk3_subject1 | 1.01 | 0% | - | - | - |
| obstacles1_subject1 | 1.07 | 미학습 |  |  |  |
| obstacles4_subject2 | 1.19 | 미학습 |  |  |  |

Success Rate가 0%인 셋은 완주한 rollout이 없어 세 지표가 정의되지 않습니다. 대신
평균 추적 길이와 전체 rollout 기준 E_g-mpbpe를 적으면 이렇습니다.

| 시퀀스 | 평균 추적 길이 | 전체 rollout E_g-mpbpe (mm) |
| --- | --- | --- |
| walk3_subject4 | 88% (10,862 / 12,330 프레임) | 116 |
| walk3_subject1 | 78% (9,606 / 12,330 프레임) | 112 |
| obstacles2_subject1 | 18% (2,144 / 12,204 프레임) | 368 |

발 오차 순위는 Policy 성적을 예측하지 못했습니다. Success Rate가 0%인 셋의 발 오차는
0.88, 0.93, 1.01 cm로 중간 대역에 있고, 발 오차가 가장 큰 축인
obstacles3_subject3(1.19 cm)은 98%로 완주합니다. E_g-mpbpe가 가장 낮은
walk4_subject1(60 mm)도 발 오차는 0.88 cm로 최상위가 아닙니다.

영상으로 보면 더 분명합니다. 종료 조건에 걸리면 에피소드가 끝나고 프레임 0부터
다시 시작하므로, 화면에서는 로봇이 갑자기 처음 자세로 돌아갑니다.

![walk3_subject1 리셋](reset_walk3_subject1.gif)

walk3_subject1, 195초 지점. Anchor 높이가 임계를 넘습니다.

![walk3_subject4 리셋](reset_walk3_subject4.gif)

walk3_subject4, 218초 지점. 발목·손목 높이가 임계를 넘습니다.

Success Rate 0%가 처음부터 못 따라간다는 뜻이 아닙니다. 3분 넘게 따라가다 한 지점에서
걸립니다. 평균 추적 길이가 78%와 88%인 것이 그 뜻입니다.

## 완주하지 못한 셋은 학습이 아니라 Reference 문제입니다

`src/motion_defect_census.py`로 네 가지를 다시 재면 셋이 한눈에 갈립니다.

| 시퀀스 | 지면 관통 | 최대 관통 | 발 미끄럼 최대 | 공중 비율 |
| --- | --- | --- | --- | --- |
| obstacles2_subject1 | 0.9% | 4.2 cm | 0.35 m/s | 26.8% |
| walk3_subject1 | 6.0% | 7.6 cm | 1.59 m/s | 0.2% |
| walk3_subject4 | 4.3% | 4.8 cm | 1.08 m/s | 0.2% |
| walk1_subject1 (완주) | 0.0% | 0.4 cm | 0.90 m/s | 0.0% |

`obstacles2_subject1`은 프레임의 26.8%가 공중입니다. 배우가 계단을 오르는
구간이라 평지에서는 발이 닿을 지면이 없습니다. 나머지 둘은 발이 지면을
파고듭니다. 완주하는 `walk1_subject1`은 관통이 0%입니다.

즉 Policy가 못 따라간 것이 아니라 따라갈 수 없는 목표를 준 것입니다. 선별
기준이 발 오차 하나였고, 그 기준으로는 이 셋이 중간 대역이라 통과했습니다.
지면 관통과 공중 비율은 보지 않았습니다.

## 같은 재료로 96-100%를 받은 연구는 두 가지를 더 했습니다

Retargeting Matters([arXiv:2510.02252](https://arxiv.org/abs/2510.02252))는
같은 LAFAN1, 같은 G1, 같은 BeyondMimic으로 sim 100회에서 96-100%를
보고합니다. 논문이 그 차이를 직접 적어두었습니다.

첫째, 문제가 되는 동작을 애초에 넣지 않습니다.

> We do not include motions with complex interaction with the environment,
> such as crawling or getting up from the floor

이 저장소가 완주하지 못한 셋이 정확히 그 부류입니다.

둘째, 관통을 측정해 보정합니다.

> We fix this by running forward kinematics on the retargeted sequences,
> storing the minimum body height at each frame, and then offsetting the
> entire motion by the mean minimum body height

이 저장소는 둘 다 하지 않았습니다. Policy 쪽 차이가 아니라 3단계에서 갈린
차이입니다.
