# 안드로이드 aarch64 행렬곱 — 무엇이 느리게 만들고 있었나

측정일 2026-08-25. 브랜치 `work/blas`. 기기 `emulator-5554`(`pmp_api26`, API 26, arm64-v8a,
vCPU 4, 커널 3.18, `ro.kernel.qemu=1`), 호스트 Apple M1(P 4 + E 4), CPython 3.13.0,
상류 torch 2.13.0.

> **결론 먼저.** `docs/PERF.md` 가 Apple 에서 회수한 **7 배는 안드로이드로 전이되지 않습니다.**
> 그 7 배는 커널 품질이 아니라 **AMX 행렬 코프로세서**였고, 안드로이드가 쓰는 NEON f32 경로에서
> 우리는 **이미 코어 피크의 88%** 에 있습니다. 같은 코어 위에서 macOS 와 안드로이드의 단일
> 스레드 GEMM 처리량이 **동일**합니다(90 GFLOP/s 대 90 GFLOP/s). 즉 **안드로이드 고유의
> 커널 결함은 없습니다.**
>
> 브리핑이 먼저 확인하라고 한 가설 — `RUSTFLAGS` 에 `-C target-cpu`/`-C target-feature` 가 없어
> baseline armv8-a 로 컴파일된다 — 은 **소스 수준과 측정 수준 양쪽에서 틀렸습니다.** `gemm`
> 0.19 는 `std` 피처에서 aarch64 를 **런타임 검출**하고(§3), 컴파일 플래그를 하나도 주지 않은
> 우리 `.so` 안에 이미 fp16 마이크로커널이 들어 있습니다.
>
> **고친 것 하나.** 실제로 값이 새고 있던 곳은 백엔드가 아니라 **스레드 정책**이었습니다.
> `gemm` 의 기본 스레딩 임계값(589,824)이 두 기계 모두에서 너무 낮아, 한 코어로 수십
> 마이크로초면 끝날 일을 네 코어에 뿌리고 깨우기 비용으로 더 씁니다. 임계값을 4,000,000 으로
> 올려 기기에서 `mm` 128×128 이 **0.364 ms → 0.053 ms (6.9 배)** 가 되었고, **비트 단위로
> 같은 결과**입니다(§5).

---

## 0. 이 문서의 숫자로 하면 안 되는 것

**에뮬레이터는 실기가 아닙니다.** 이 기기는 HVF 로 호스트 M1 코어 위에서 도는 게스트이고,
게스트 `/proc/cpuinfo` 의 Features 는 `fp asimd evtstrm aes pmull sha1 sha2 crc32` 뿐입니다 —
**`asimdhp`(fp16) 도 `asimddp`(dotprod) 도 `i8mm` 도 보고하지 않습니다.** 실기의 big 코어는
이 셋을 다 가지고 있으므로, **저정밀 경로에 관한 어떤 수치도 여기서 잴 수 없습니다.**

**측정 중 기계가 놀고 있지 않았습니다.** load average 는 회차에 따라 1.5 에서 35 사이를
오갔고, 다른 세션의 에이전트를 끌 수 없었습니다. 그래서 두 가지로 방어했습니다.

- **A/B 를 번갈아** 돌리고, 15 회 반복의 **최솟값**만 씁니다.
- **단일 스레드 수치는 재현성이 매우 높습니다** (기기 `mm` 512 가 5 회 측정에서 2.966~2.973 ms).
  **스레드를 쓰는 수치는 그렇지 않습니다** (같은 설정에서 1.76~3.92 ms). 그래서 아래에서
  결론을 지탱하는 자리에는 전부 단일 스레드 수치를 씁니다.

**상류 torch 를 기기에서 돌리지 않았습니다.** aarch64-android CPython 용 상류 휠이 없습니다.
따라서 "안드로이드에서 상류 대비 몇 배" 는 **이 문서가 직접 측정한 값이 아닙니다.** 대신
같은 기계 위에서 백엔드만 바꾼 A/B 로 그 배수를 분해합니다(§2).

**브리핑의 `12배 = 백엔드 3.9배 × 플랫폼 3.2배` 분해를 저장소에서 찾지 못했습니다.**
`docs/PERF.md` 에도 다른 문서에도 없습니다. 아래 §2 는 그 분해를 인용하지 않고 다시 잽니다.

---

## 1. 안드로이드의 GEMM 커널은 느리지 않다 — macOS 와 같다

같은 크레이트(`candle-core` → `gemm` 0.19), 같은 소스, 단일 스레드
(`RAYON_NUM_THREADS=1`), f32 `aten.mm`. 15 회 반복 최솟값의 GFLOP/s.

| n | 호스트 macOS/arm64 (gemm) | 기기 Android/aarch64 (gemm) |
|---:|---:|---:|
| 128 | 78.4 · 81.2 | **82.8** |
| 256 | 86.1 · 89.2 | **83.4** |
| 512 | 88.4 · 93.3 | **90.4** |
| 1024 | 89.5 | **90.3** |

**차이가 없습니다.** 두 끝은 물리적으로 같은 실리콘(M1 P 코어)이고, 한쪽은 macOS 네이티브,
다른 쪽은 안드로이드 게스트입니다. 코드 생성 · 캐시 파라미터 · libc 가 전부 다른데도 처리량이
같다는 것은, **안드로이드 빌드에서 커널이 열화되고 있지 않다**는 뜻입니다.

그리고 이것이 피크에 얼마나 가까운지가 나머지 절반입니다.

    M1 Firestorm NEON f32 피크
      = 4 FMA 파이프 × 128 bit(f32 4 레인) × 2 FLOP = 32 FLOP/cycle
      @ 3.204 GHz = 102.5 GFLOP/s

    측정 90.4 GFLOP/s = 피크의 88%

**f32 NEON 으로 회수할 수 있는 여지가 최대 1.14 배입니다.** 손으로 튜닝한 BLAS
(OpenBLAS · BLIS · ARM Compute Library)가 통상 도달하는 85~92% 대역에 `gemm` 크레이트가
이미 들어와 있습니다.

> 피크 계산은 Firestorm 이 사이클당 4 개의 128-bit FMA 를 발행한다는 공개된 마이크로아키텍처
> 수치에 기댑니다. 그 전제가 틀리면 88% 라는 비율도 틀립니다 — **직접 측정한 것은 90.4
> GFLOP/s 이고, 88% 는 거기서 파생된 값입니다.**

---

## 2. 그러면 Apple 의 7 배는 무엇이었나 — AMX

같은 호스트, 같은 코어, 백엔드만 바꾼 A/B (`mm` 512×512 f32, GFLOP/s):

| 빌드 | 스레드 1 | 스레드 8 |
|---|---:|---:|
| 우리, `gemm` (accelerate 끔) | 88.4 · 93.3 | 198 · 232 |
| 우리, `accelerate` (현재 배송 설정) | **1086 · 1100** | 1101 · 1186 |
| 상류 torch 2.13.0 | **1317** | 1319 |

**상류가 스레드 1 과 8 에서 같습니다** (1317 대 1319). 스레드로 스케일되지 않는데 코어당 NEON
피크(102.5)의 **12.8 배**가 나옵니다. 코어 안에서 나올 수 있는 수가 아니고, 스레드로 나온
수도 아닙니다 — **행렬 코프로세서(AMX)** 입니다. 우리 `accelerate` 빌드도 같은 자리에
있습니다(1086~1100).

즉 `docs/PERF.md` §3 이 기록한 "feature 플래그 하나로 7 배가 1 배" 의 정체는 **Accelerate 가
AMX 를 부르는 것**이지, candle 의 커널이 나빴던 것이 아닙니다.

**이것이 안드로이드로 전이되지 않는 이유:** 이 빌드가 겨냥하는 ARMv8.2-A 베이스라인에는
그런 코프로세서가 없습니다. ARM 쪽 대응물(SME/SME2, 그리고 저정밀의 `bfmmla`·`smmla`)은
베이스라인 밖이고, **이 에뮬레이터는 그중 어느 것도 광고하지 않습니다**(§0). 어떤 실기가
무엇을 가졌는지는 여기서 판정할 수 없습니다.

그리고 상류 자신도 f32 GEMM 을 그쪽으로 보내지 않습니다. 벤더 트리에서 KleidiAI 가 걸리는
자리는 **`aten._dyn_quant_pack_4bit_weight` 하나**입니다:

    torchnative/src/main/torch/_meta_registrations.py:4270
        if torch.backends.kleidiai.is_available() and (...)   # 4-bit 양자화 가중치 패킹

**KleidiAI 는 f32 행렬곱의 답이 아닙니다.** 상류가 그것을 쓰는 곳은 양자화 경로입니다.

---

## 3. 브리핑의 가설 — 컴파일 플래그 — 은 틀렸다

두 가지 방식으로 확인했고 둘 다 같은 답입니다.

### 3.1 소스: `gemm` 0.19 는 런타임 검출이다

`gemm-common-0.19.0/src/lib.rs:85-90`

```rust
#[cfg(all(feature = "std", target_arch = "aarch64"))]
macro_rules! feature_detected {
    ($tt: tt) => { ::std::arch::is_aarch64_feature_detected!($tt) };
}
```

`std` 는 `gemm-common` 의 기본 피처이고 `candle-core` 가 그대로 켭니다. `std` 가 없을 때만
`cfg!(feature = ...)` 라는 컴파일타임 경로로 떨어집니다. 그리고 커널 모듈 자체는
`#[cfg(target_arch = "aarch64")]` 로만 걸려 있어 **플래그와 무관하게 항상 컴파일**되고,
선택만 런타임에 일어납니다(`src/gemm.rs:1024-1035`).

`RUSTFLAGS` 를 하나도 주지 않고 만든 우리 `.so` 를 뒤지면 그 증거가 그대로 나옵니다:

```
$ llvm-nm -C lib_C.so | grep -i neonfp16
... gemm_f16::gemm::f16::neonfp16::gemm_basic ...
... gemm_common::simd::aarch64::NeonFp16 as ... ::vectorize::implementation ...
```

**`+fp16` 을 준 적이 없는데 fp16 마이크로커널이 들어 있습니다.** 컴파일 플래그는 문이 아닙니다.
(그 문은 `is_aarch64_feature_detected!("fp16")` → `getauxval(AT_HWCAP)` 이고, `.so` 의 undefined
심볼에 `getauxval` 이 있는 것으로 그 경로가 살아 있음을 확인했습니다.)

### 3.2 측정: `-C target-cpu=cortex-a76` 은 아무것도 바꾸지 않는다

같은 소스를 플래그만 바꿔 두 벌 빌드하고 번갈아 측정 (GFLOP/s, 단일 스레드):

| n | 플래그 없음 | `-C target-cpu=cortex-a76` |
|---:|---:|---:|
| 128 | 82.85 | 82.04 |
| 256 | 83.30 | 83.34 |
| 512 | 90.51 | 89.72 |
| 1024 | 90.45 | 90.25 |

**차이 없음.** f32 GEMM 에는 `dotprod`·`i8mm`(정수)도 `fp16`(반정밀)도 쓰이지 않으므로 당연한
결과이고, 남는 것은 명령어 스케줄링 차이인데 그것도 잡히지 않습니다.

**이 가설이 맞았다면 고치는 비용이 플래그 한 줄이었을 것입니다. 틀렸으므로 그 줄은 없습니다.**

---

## 4. 실제로 새고 있던 곳 — 스레드 정책

`candle` 은 모든 matmul 을 무조건 `Parallelism::Rayon(n)` 으로 넘기고
(`candle-core/src/cpu_backend/mod.rs:1409-1414`), **실제로 스레드를 쓸지는 `gemm` 이 정합니다**:
`m × n_chunk × k_chunk >= DEFAULT_THREADING_THRESHOLD` 일 때만 씁니다. 그 기본값이
`48 * 48 * 256 = 589_824` 입니다(`gemm-common/src/gemm.rs:109`).

### 4.1 실기(M1, 8 코어, load 1.5)에서 잰 손익분기

임계값을 바꿔가며 같은 모양을 재면 어디서 스레딩이 손해인지 그대로 보입니다 (ms, 25 회 최솟값,
2 회차):

| n | m·n·k | 단일 스레드 | 기본 임계값(=스레드 씀) | 판정 |
|---:|---:|---:|---:|---|
| 64 | 262 k | 0.0090 | 0.0090 | 임계값 아래라 원래 단일 |
| 96 | 885 k | **0.0247** | 0.0417 · 0.0488 | **스레딩이 1.7~2.0 배 손해** |
| 128 | 2.10 M | 0.0519 | 0.0640 · 0.0443 | 손익분기 (회차마다 뒤집힘) |
| 192 | 7.08 M | 0.1602 | 0.0870 · 0.0780 | 스레딩 1.8~2.1 배 이득 |
| 256 | 16.8 M | 0.3714 | 0.1399 · 0.1440 | 스레딩 2.6 배 이득 |
| 384 | 56.6 M | 1.208 | 0.4106 · 0.3648 | 스레딩 2.9~3.3 배 이득 |
| 512 | 134 M | 2.835 | 0.8287 · 0.8169 | 스레딩 3.4 배 이득 |

**손익분기는 2~4 M 곱셈덧셈 사이입니다. 기본값은 그보다 4~7 배 낮습니다.**

### 4.2 기기에서는 손익분기가 훨씬 높다

같은 스윕을 기기에서 (ms, 4 스레드):

| n | 임계값 589,824 (기본) | 4 M | 20 M | 200 M(=사실상 단일) |
|---:|---:|---:|---:|---:|
| 128 | 0.3612 | **0.0505** | 0.0506 | 0.0507 |
| 256 | 0.8379 | 0.7006 | **0.4026** | 0.4032 |
| 512 | 4.0222 | 2.4777 | 2.4562 | 2.9638 |
| 1024 | 12.575 | 9.6649 | 9.8920 | 23.791 |

기기에서는 **n=256 까지 스레딩이 손해**입니다. 다만 이 위치 이동은 **에뮬레이터 고유일
가능성이 큽니다** — HVF 게스트에서 로드가 걸린 호스트의 스레드 깨우기 비용이 실기보다 훨씬
비쌉니다. 그래서 **임계값은 기기가 아니라 실기(§4.1)에서 고른 값을 씁니다.**

### 4.3 고른 값과 그 근거

    rust/torch_c/src/lib.rs
    const GEMM_THREADING_THRESHOLD: usize = 4_000_000;

- **실기(§4.1)에서 안전합니다.** 손해가 확실한 n=96 을 단일로 되돌리고, 이득이 확실한
  n≥192 는 건드리지 않습니다. 유일하게 판정이 바뀌는 n=128 은 실기에서 손익분기이고
  (단일 0.0519 대 스레드 0.0443~0.0640), 4 M 을 고르면 0.0518 로 고정됩니다.
- **기기에서 6.9 배를 회수합니다.** 2 M 을 고르면 128³=2.097 M 이 여전히 임계값 위라
  기기의 n=128 이 그대로 0.36 ms 에 남습니다. 4 M 이 그 경계를 넘깁니다.
- **영향 범위가 좁습니다.** M1 코어 하나로 60 µs 미만인 일감만 판정이 바뀝니다.

`BW_GEMM_THREADING_THRESHOLD` 로 재빌드 없이 덮어쓸 수 있습니다 — 이 문서의 스윕이
그것으로 재현됩니다(§7).

### 4.4 전후 (기기, 기본 스레드 수, 3 회차 번갈아)

| | 전 (ms) | 후 (ms) | 배수 |
|---|---:|---:|---:|
| `mm` 128 | 0.3638 · 0.3658 · 0.3633 | **0.0530 · 0.0529 · 0.0529** | **6.9×** |
| `mm` 256 | 0.805 · 0.804 · 0.835 | 0.740 · 0.698 · 0.733 | 1.1× (노이즈) |
| `mm` 512 | 3.92 · 3.92 · 1.88 | 2.49 · 2.42 · 3.92 | 변화 없음 |
| `mm` 1024 | 14.25 · 14.35 · 9.72 | 14.24 · 9.51 · 14.09 | 변화 없음 |
| `mv` 1024 (디코딩 모양) | 0.0915 · 0.0919 · 0.0917 | 0.0912 · 0.0913 · 0.0912 | 변화 없음 |
| `add` 1024 (대조군) | 0.478 · 0.480 · 0.486 | 0.487 · 0.488 · 0.489 | 변화 없음 |

512 이상은 임계값 위라 양쪽 다 스레드를 쓰고, 남은 흔들림은 호스트 로드입니다(§0).
256 의 소폭 개선은 메커니즘상 설명되지 않으므로 **노이즈로 읽습니다.**

**산출물 크기: 4,344,456 B → 4,344,192 B (−264 B).** 코드가 늘지 않았다는 뜻이고,
`gemm` 을 직접 의존으로 적은 것이 이미 있던 크레이트를 이름으로만 부르는 것임을 확인합니다.

### 4.5 디코딩 모양에는 애초에 해당이 없다

자기회귀 생성 한 토큰은 `(1×n) @ (n×n)` 이고, `gemm` 은 `m <= 1` 을 **gemv 커널로 보냅니다**
(`gemm-common/src/gemm.rs:335-349`). gemv 에는 스레딩 경로가 아예 없습니다. 위 표의 `mv`
행이 임계값과 무관하게 고정인 것이 그 확인입니다 (0.091 ms, ~23 GFLOP/s — 4 MB 를 0.09 ms 에
읽으므로 **메모리 대역폭에 걸린 것**이지 연산이 아닙니다).

---

## 5. 수치 대가가 없다 — 가정이 아니라 확인

`gemm` 의 병렬 분할은 **출력 열(n 방향)** 을 스레드에 나누는 것이고, `k` 누적 루프
(`while depth_outer != k`)는 그 바깥에 있어 양쪽 경로에서 같습니다. 따라서 모든 출력 원소가
같은 연산 순서를 거칩니다. **그 주장을 그대로 확인했습니다** — `gemm` 백엔드 빌드로
임계값만 바꿔 `mm` 결과의 sha256 을 비교:

```
589824         ad3010e3dcd976776cf1bdd5cb7f3b1196d61c65f982abeb55c80cf7500935b7
4000000        ad3010e3dcd976776cf1bdd5cb7f3b1196d61c65f982abeb55c80cf7500935b7
999999999999   ad3010e3dcd976776cf1bdd5cb7f3b1196d61c65f982abeb55c80cf7500935b7
```

(n ∈ {96, 128, 192, 256, 384, 512}, 완전 병렬 / 새 기본값 / 완전 직렬.) **비트 단위로 같습니다.**

골든도 양쪽 빌드에서 통과합니다.

| 빌드 | 결과 |
|---|---|
| 호스트 `accelerate` (배송 설정) | `2268/2268 cases passed, 0 failed, ops covered=97` |
| 호스트 `gemm` (임계값 변경이 실제로 걸리는 쪽) | `2268/2268 cases passed, 0 failed, ops covered=97` |

> 골든만으로는 이 변경을 검증할 수 없습니다 — 골든의 모양이 전부 589,824 아래라 임계값과
> 무관하게 단일 스레드입니다. 그래서 위의 sha256 대조를 따로 둡니다.

---

## 6. 조율 세션에 보고할 별건 — `device_android.sh parity` 가 지금 깨져 있다

이 작업과 무관하지만 측정 중에 걸렸고, **원인이 오늘 들어간 변경이라 적어 둡니다.**

```
$ bash scripts/device_android.sh parity
MISMATCH addmm.default / bmm.default / mm.default        1 ULP
MISMATCH cos.default / sin.default / rsqrt.default        1 ULP
MISMATCH native_layer_norm.default / nn.Linear forward    2 ULP
PARITY: unexpected bit divergence: [...8 건...]
```

**기기 쪽 회귀가 아니라 호스트 쪽 빌드가 바뀐 것입니다.** 같은 기기 `.so` 를 두고 호스트만
`gemm` 백엔드로 바꾸면:

```
libm _softmax.default: 1 ULP
libm tanh.default:     1 ULP
identical 31/33
PARITY: ok
```

`docs/PERF.md` §3 이 **오늘** Apple 타깃에 `accelerate` 를 켰고, `scripts/device_android.sh` 의
`EXPECTED_LIBM_DIVERGENCE` 는 그 이전에 쓰인 목록입니다. Accelerate 는 BLAS 로 누적 순서를
바꾸고(`mm`·`addmm`·`bmm`·`layer_norm`) vForce 로 초월함수를 대체합니다(`sin`·`cos`·`rsqrt`).
**8 건 전부 그것으로 설명됩니다.**

이 문서는 그것을 고치지 않습니다 — 1~2 ULP 를 면제할지는 허용오차 정책의 판단이고,
이 작업의 범위 밖입니다. **다만 지금 `parity` 는 exit 1 입니다.**

> **고쳐졌습니다 (2026-08-25).** 면제 목록을 늘리는 대신, `parity` 가 **호스트 쪽을
> `accelerate` 없이 따로 빌드**해서 gemm 대 gemm 으로 비교하도록 바꿨습니다 — 이 절이
> 실측한 그 구성입니다. 면제 목록은 원래의 둘로 유지되고 `PARITY: ok` 로 돌아왔습니다.
> **배송 빌드는 바뀌지 않았습니다.** 근거는 `docs/DEVICE.md` §5.2 이고, Apple ↔ 안드로이드
> 사이에 실제로 남는 8 건의 차이는 §5.1 에 기록해 두었습니다.

---

## 7. 재현

```sh
export PATH="$HOME/.cargo/bin:$PATH"
cd /Volumes/macMini/worktrees/bw-blas
bash vendor/vendor_torch.sh                       # 새 worktree 라면
export CARGO_TARGET_DIR=/Volumes/macMini/caches/cargo-target-blas
export ANDROID_SERIAL=emulator-5554               # 5556 은 다른 에이전트 것
```

### 7.1 기기 벤치

`/tmp/bwmm.py`(모양 스윕)와 `/tmp/bwsmall.py`(작은 모양 스윕)는 저장소 밖입니다. 아래
`bench.py` 를 임의 위치에 두고 쓰십시오 — `device_parity.py` 와 같은
`_multiprocessing`/`_posixshmem` 스텁이 필요합니다(안드로이드 CPython 에 둘 다 없고
`torch/__init__.py` 가 무조건 import 합니다).

```sh
bash scripts/device_android.sh build
bash scripts/device_android.sh stage
bash scripts/device_android.sh run <bench.py> baseline
```

임계값을 바꿔 재려면 `adb shell` 에 환경 변수를 직접 얹습니다 (`device_android.sh run` 은
환경을 고정하므로 우회):

```sh
ADB="$HOME/Library/Android/sdk/platform-tools/adb -s emulator-5554"
D=/data/local/tmp/bw_device
$ADB push --sync <bench.py> $D/bench.py
$ADB shell "cd $D && BW_STUB_MULTIPROCESSING=1 TORCH_USE_RTLD_GLOBAL=1 \
    LD_LIBRARY_PATH=$D/lib PYTHONHOME=$D PYTHONPATH=$D/site \
    BW_GEMM_THREADING_THRESHOLD=589824 RAYON_NUM_THREADS=4 \
    ./bin/python3.13 bench.py label 2>&1; echo DEVICE_EXIT=\$?"
```

**`adb shell` 의 종료 코드를 읽지 마십시오.** 기기 셸이 스스로 찍는 `DEVICE_EXIT=` 를 봅니다.

### 7.2 호스트 A/B (백엔드 비교)

`accelerate` 는 `Cargo.toml` 의 `[target.'cfg(target_vendor = "apple")'.dependencies]` 절에
있습니다. **이 문서를 쓸 때는 그 줄을 손으로 지웠다 되돌려야 했지만, 지금은 그럴 필요가
없습니다** — 그 절이 `not(torch_c_no_accelerate)` 로 게이팅되어 있어 명령줄에서 끕니다
(2026-08-25, `parity` 가 쓰는 것과 같은 경로).

```sh
export CARGO_TARGET_DIR=/Volumes/macMini/caches/cargo-target-blas-noaccel
( cd rust/torch_c && cargo build --release \
    --config 'target."cfg(target_vendor = \"apple\")".rustflags = ["--cfg", "torch_c_no_accelerate"]' )
otool -L $CARGO_TARGET_DIR/release/lib_C.dylib | grep -c Accelerate   # 0 이어야 함
cp $CARGO_TARGET_DIR/release/lib_C.dylib torchnative/src/main/torch/_C.abi3.so
RAYON_NUM_THREADS=1 TORCH_USE_RTLD_GLOBAL=1 PYTHONPATH=$PWD/torchnative/src/main \
    /Volumes/macMini/caches/spike-venv/bin/python <bench.py> host-noaccel-t1
```

**`RUSTFLAGS="--cfg torch_c_no_accelerate"` 로 주지 마십시오.** 환경 변수 쪽은
`.cargo/config.toml` 의 rustflags 를 더하는 것이 아니라 **대체**하므로 호스트 링크가
`-undefined dynamic_lookup` 을 잃고 `_Py*` 미해결 심볼 더미로 실패합니다(실측).

상류 쪽은 `PYTHONPATH` 없이 `/Volumes/macMini/caches/spike-venv/bin/python` 을 그대로 씁니다
(벤더 트리를 `PYTHONPATH` 에 넣지 마십시오).

### 7.3 회귀

```sh
bash vendor/install_shim.sh
export TORCH_C_ARTEFACT=$CARGO_TARGET_DIR/release/lib_C.dylib
/Volumes/macMini/caches/spike-venv/bin/python tools/golden/compare.py
# SUMMARY: 2268/2268 cases passed, 0 failed, ops covered=97
```

---

## 8. 남은 지렛대와 그 비용

| 지렛대 | 기대치 | 비용 | 상태 |
|---|---|---|---|
| **스레드 임계값** | 기기 n=128 에서 6.9×, 실기 n=96 에서 1.7~2.0× | 6 줄 | **완료 (§4)** |
| **big.LITTLE 스레드 수** | 아래 참조 | 환경 변수 하나 ~ candle 패치 | **미측정** |
| **f16 / 양자화** | fp16 `fmla` 로 f32 대비 2×, `smmla`(int8) 는 그 이상 | 실기 + aten 표면의 f16 커버리지 | **미측정** |
| **OpenBLAS / BLIS 크로스컴파일** | **f32 에서 최대 1.14×** (§1 의 88%) | BLAS 크로스빌드 + candle matmul 패치 + 새 수치 리스크 | **권하지 않음** |

### 8.1 big.LITTLE — 예측이지 측정이 아니다

두 사실이 맞물립니다.

- `candle` 의 `default_num_threads()` 는 **macOS 에서만** P 코어 수를 봅니다
  (`perf_core_count()` → `hw.perflevel0.logicalcpu`). 그 밖에서는 `num_cpus::get_physical()`
  이고, 스레드 QoS 를 올리는 `set_thread_affinity()` 도 **non-macOS 에서는 빈 함수**입니다
  (`candle-core/src/utils.rs:313-324, 388-392`).
- `gemm` 의 `par_for_each` 는 **정적 균등 분할**입니다 — `n_tasks / n_threads` 에 나머지를
  앞쪽에 몰아주고, 워크 스틸링이 없습니다 (`gemm-common/src/gemm.rs:561-616`).

big 4 + LITTLE 4 인 실기에서 이 둘이 만나면 **모든 행렬곱이 LITTLE 코어를 기다립니다.**
LITTLE 이 3 배 느리면 8 스레드가 big 4 스레드보다 느려질 수 있습니다.

**이 에뮬레이터로는 확인할 수 없습니다** — vCPU 4 개가 동질입니다. 확인 비용은 실기 한 대이고,
고치는 비용은 `/sys/devices/system/cpu/cpu*/cpufreq/cpuinfo_max_freq` 를 읽어
`RAYON_NUM_THREADS` 를 정하는 것(코드 0 줄)부터 candle 패치까지 폭이 있습니다.

### 8.2 캐시 정보 자동 검출은 실제로 실패한다 — 그런데 대가가 없다

기기에 `/sys/devices/system/cpu/cpu0/cache/` 가 **없습니다.** `gemm` 의
`try_cache_info_linux()` 는 그 디렉터리가 없으면 오류를 내지 않고 `continue` 한 뒤 0 인 칸을
`CACHE_INFO_DEFAULT` 로 채워 **`Ok`** 를 돌려줍니다. 그래서 `lscpu` 폴백은 시도조차 되지
않고, 블로킹 파라미터가 **L1 16 KiB · L2 512 KiB · L3 1 MiB** 라는 기본값으로 계산됩니다
(실제 M1 은 L1d 128 KiB · L2 12 MiB).

**그런데 §1 이 이 항목을 닫습니다.** 캐시 파라미터가 전혀 다른 두 끝이 같은 처리량을 내고,
그 처리량이 코어 피크의 88% 입니다. 블로킹이 나빴다면 88% 에 있을 수 없습니다. **최대
12% 이고, 아마 그보다 훨씬 작습니다.** 우선순위가 낮습니다.

---

## 9. 확인하지 않은 것

| 항목 | 상태 |
|---|---|
| 실기 안드로이드 | **없음.** 전부 에뮬레이터다(§0) |
| big.LITTLE | **미측정.** vCPU 가 동질이라 잴 수 없다(§8.1) |
| f16 · bf16 · int8 | **미측정.** 게스트가 `asimdhp`/`asimddp`/`i8mm` 을 광고하지 않는다 |
| 안드로이드에서의 상류 torch | **못 잼.** aarch64-android CPython 휠이 없다 |
| 브리핑의 `3.9 × 3.2` 분해 | **저장소에서 못 찾음.** §2 는 다시 잰 값이다 |
| load 통제 | **못 함.** 1.5~35 사이를 오갔다. 단일 스레드 수치만 결론에 썼다(§0) |
| `_softmax` | 이 문서가 다루지 않는다. `docs/PERF.md` §4 참조 |
| 4 M 이 실기 안드로이드에서도 맞는 값인지 | **미확인.** M1 에서 골랐고, 기기에서 회귀하지 않음만 확인했다 |
