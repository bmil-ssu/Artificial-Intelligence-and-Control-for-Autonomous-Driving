"""학습 실행 스크립트.

╔══════════════════════════════════════════════════════════════════╗
║  실험할 때 만지는 곳은 아래 "하이퍼파라미터" 블록이다.              ║
║  gamma, lr, n_steps 등 학습 설정을 여기서 바로 바꾸면 된다.        ║
║                                                                  ║
║  그 외의 것들:                                                    ║
║    도로/교통 설정   → env/road_config.py                          ║
║    MDP(관측/보상)   → env/mdp_config.py                           ║
║    알고리즘 코드    → algorithms/ppo.py                           ║
║    네트워크 / 평가  → utils/networks.py, utils/evaluator.py       ║
╚══════════════════════════════════════════════════════════════════╝

실행:  python train.py
"""
import os
import shutil
from datetime import datetime

from env.road_config import ROAD, EGO, TRAFFIC
from env.mdp_config import SIMULATION, OBSERVATION, ACTION, REWARD
from env import road_builder
from env.sumo_env import SumoHighwayEnv

from algorithms.ppo import PPO
from utils.buffer import RolloutBuffer
from utils.logger import RunLogger

BASE = os.path.dirname(os.path.abspath(__file__))


# ══════════════════════════════════════════════════════════════════
#  하이퍼파라미터 — 실험은 여기서
# ══════════════════════════════════════════════════════════════════
TOTAL_TIMESTEPS = 200_000   # 총 학습 스텝 수

HPARAMS = dict(
    # ---- 최적화 ----
    lr=1e-4,                 # 학습률. 보상이 요동치면 낮출 것 (3e-4 → 1e-4 → 5e-5)
    n_steps=2048,            # rollout 길이. 크면 advantage 추정이 안정적
    n_epochs=10,             # 모은 데이터 재사용 횟수
    minibatch_size=64,

    # ---- 할인 / advantage ----
    gamma=0.99,              # 할인율 γ. 0.99 ≈ 100스텝(50초) 앞을 내다봄
    gae_lambda=0.95,         # GAE λ. 1에 가까울수록 분산↑편향↓

    # ---- PPO 고유 ----
    clip_eps=0.2,            # 클리핑 범위 ε
    value_coef=0.5,          # 가치 손실 가중치
    entropy_coef=0.0,        # 엔트로피 보너스.
                             #   연속 제어에서는 0이 표준. 0.01처럼 크게 주면
                             #   σ가 안 줄어들어 정책이 계속 랜덤에 머문다.
    max_grad_norm=0.5,
    normalize_advantage=True,

    # ---- 네트워크 (utils/networks.py) ----
    hidden_sizes=(256, 256),
    activation="relu",       # "tanh" | "relu" | "elu"
    init_log_std=-0.5,       # 초기 탐험 폭 σ = exp(-0.5) ≈ 0.61
                             #   행동 범위가 [-1,1]이라 σ=1.0은 거의 완전 랜덤.
                             #   탐험이 부족하면 -0.2, 과하면 -1.0 정도로 조정.

    # ---- 기타 ----
    seed=0,
    device="auto",           # "auto" | "cpu" | "cuda"
)

# ---- 평가 / 로깅 ----
EVAL_INTERVAL = 5       # 몇 번의 업데이트마다 주행 지표를 평가할지 (0이면 안 함)
EVAL_EPISODES = 5       # 평가 1회당 에피소드 수
LOG_INTERVAL = 1        # 몇 번의 업데이트마다 콘솔에 출력할지
RESULTS_DIR = "results" # 결과 저장 폴더
RUN_NAME = None         # None이면 run_날짜_시각 자동 생성.
                        # 문자열을 주면 그 이름으로 저장 (예: "exp_lr1e-4")
# ══════════════════════════════════════════════════════════════════


def make_run_dir() -> str:
    """results/<run이름>/ 폴더를 만들고 경로를 반환."""
    name = RUN_NAME or datetime.now().strftime("run_%Y%m%d_%H%M%S")
    run_dir = os.path.join(BASE, RESULTS_DIR, name)
    os.makedirs(run_dir, exist_ok=True)
    if not os.path.isdir(run_dir):
        raise NotADirectoryError(
            f"결과 폴더를 만들 수 없습니다: {run_dir}\n"
            f"  같은 이름의 '파일'이 이미 있는지 확인하세요.")
    return run_dir


def snapshot_configs(run_dir: str):
    """이 run에 사용된 설정 파일들을 복사해둔다 (재현/비교용).

    학습 스크립트 자신(train.py)도 함께 저장한다 — 하이퍼파라미터가
    이 파일 안에 있으므로, 나중에 "이 결과가 어떤 설정이었나"를
    정확히 되짚을 수 있다.
    """
    for src in [os.path.join(BASE, "env", "road_config.py"),
                os.path.join(BASE, "env", "mdp_config.py"),
                os.path.join(BASE, "train.py")]:
        shutil.copy(src, run_dir)


if __name__ == "__main__":
    # 1) 도로 생성 (env/road_config.py 기준으로 매번 재생성)
    sumocfg = road_builder.build(ROAD, EGO, TRAFFIC,
                                 os.path.join(BASE, "env", "sumo"))
    print(f"도로 생성 완료: {sumocfg}")
    print(f"  길이 {ROAD['length']}m, {ROAD['num_lanes']}차선, "
          f"교통량 {TRAFFIC['vehs_per_hour']}대/시간")

    # 2) 결과 폴더 + 로거
    run_dir = make_run_dir()
    logger = RunLogger(run_dir)
    print(f"결과 폴더: {run_dir}")

    # 3) 환경
    env = SumoHighwayEnv(
        cfg_path=sumocfg,
        road=ROAD, ego=EGO,
        mdp_sim=SIMULATION, mdp_obs=OBSERVATION,
        action=ACTION, reward=REWARD,
        gui=False,   # 학습은 화면 없이 (수십 배 빠름)
    )

    # 4) 경험 버퍼 + 에이전트
    #    버퍼는 메인에서 만들어 에이전트에 "주입"한다 (utils/buffer.py).
    #    PPO는 on-policy라 RolloutBuffer를 쓰고, 나중에 SAC/DQN 같은
    #    off-policy 알고리즘을 붙일 땐 여기서 ReplayBuffer로 갈아끼우면 된다.
    buffer = RolloutBuffer()
    agent = PPO(
        obs_dim=env.observation_space.shape[0],
        act_dim=env.action_space.shape[0],
        buffer=buffer,
        **HPARAMS,
    )
    print(f"obs_dim={env.observation_space.shape[0]}, "
          f"act_dim={env.action_space.shape[0]}, device={agent.device}")

    # 5) 학습 → 저장
    #    try/finally: Ctrl+C나 에러로 중단돼도 SUMO 정리 + 결과 저장은 수행
    try:
        agent.learn(env,
                    total_timesteps=TOTAL_TIMESTEPS,
                    logger=logger,
                    log_interval=LOG_INTERVAL,
                    eval_interval=EVAL_INTERVAL,
                    eval_episodes=EVAL_EPISODES)
    finally:
        env.close()
        logger.close()
        model_path = os.path.join(run_dir, "model.pt")
        agent.save(model_path)
        snapshot_configs(run_dir)
        print(f"\n저장 완료: {model_path}")
        print(f"재생 방법:      python test.py "
              f"{os.path.relpath(model_path, BASE)}")
        print(f"학습 곡선 보기: tensorboard --logdir {RESULTS_DIR}"
              f"  → http://localhost:6006")
