# Fama-French (1993) Replication: 주식과 채권 수익률의 공통 위험요인

본 프로젝트는 Fama & French (1993)의 논문 *"Common Risk Factors in the Returns on Stocks and Bonds"*를 Python으로 복제한 결과이다. 시장 요인(Mkt-RF)에 규모(SMB), 가치(HML), 기간 스프레드(TERM), 부도 스프레드(DEF)를 추가한 5요인 모델을 재구성하고, 1963년 7월부터 1991년 12월까지 25개 주식 포트폴리오와 7개 채권 포트폴리오에 대한 설명력을 평가한다.

---

## 1. 서론 (Introduction)

자본자산가격결정모형(CAPM)은 단일 시장 요인이 기대수익률의 횡단면을 설명한다고 주장한다. 그러나 1980년대와 1990년대 초반에 축적된 실증 연구는 이 예측을 반복적으로 기각했다. Fama와 French(1993)은 시장 요인에 규모(SMB), 가치(HML), 그리고 두 개의 채권 요인(TERM과 DEF)을 추가한 다요인 모델을 제안했다.

### 복제 범위
- **분석 기간**: 1963-07 ~ 1991-12 (342개월)
- **5개 요인**: Mkt-RF, SMB, HML, TERM, DEF
- **검정 자산**: 25개 Size × BE/ME 주식 포트폴리오 + 7개 채권 포트폴리오 프록시
- **주식 포트폴리오 구축**: `compustat_portfolio_builder.py`가 Compustat BE + CRSP 원시 데이터로 1964-07~1991-12 구간(330개월)의 25/6 포트폴리오와 SMB/HML 요인을 자체 생성한다. gvkey↔PERMCO 오픈소스 매핑(Wenzhi-Ding/Std_Security_Code)을 통해 CRSP/CCM 상용 데이터베이스 없이 구축했다. 1963-07~1964-06(12개월)은 Ken French 데이터를 유지한 hybrid 방식이다.

> **채권 프록시 면책 조항**: 본 복제에서 사용된 채권 요인(TERM, DEF)은 FRED(GS10, TB3MS, BAA, AAA)에서 수집한 실제 시장 데이터(수익률 스프레드)이다. 다만 채권 포트폴리오는 실제 채권 포트폴리오 수익률이 아니라 해당 수익률 기반 추정치(yield-based proxies)이다.

---

## 2. 논문 섹션별 구현 맵핑 (Paper-to-Code Mapping)

각 Python 스크립트는 원 논문의 특정 섹션 및 표와 대응한다.

| 논문 Section | 논문 내용 | 구현 스크립트 | 설명 |
|---|---|---|---|
| FF1993 Section 2.1 | 주식 요인 SMB/HML 구성 | `01_section2_factors.py` | 6개 포트폴리오로 SMB/HML 계산 |
| FF1993 Section 2.1 | 채권 요인 TERM/DEF 구성 | `01b_section2_bond_factors.py` | FRED yield로 TERM/DEF 병합 |
| FF1993 Section 2.2 | 25개 Size×BE/ME 포트폴리오 | `02_section2_portfolios.py` | 포트폴리오 수익률 로드 |
| FF1993 Section 2.2 | 7개 채권 포트폴리오 프록시 | `02b_section2_bond_portfolios.py` | yield 기반 프록시 생성 |
| FF1993 Section 3 | 기술통계 (Table 2) | `03_section3_statistics.py` | 평균, 표준편차, t-통계량 |
| FF1993 Section 4.1-4.3 | 회귀분석 (Tables 1,3,4) | `04_section4_regressions.py` | 1F/3F/채권 모델 |
| FF1993 Section 4.4 | 5요인 모델 (Table 5) | `04b_section4_five_factor.py` | 통합 5요인 모델 |
| FF1993 Section 5 | GRS 검정 | `05_section5_grs_test.py` | GRS F-검정 |
| FF1993 Section 5 | 절편 분석 | `05b_section5_intercepts.py` | 횡단면 절편 분포 |
| FF1993 Section 6 | 시각화 + 보고서 | `06_section6_visualizations.py` + `06_section6_conclusions.py` | 6개 Figure + 보고서 |
| Compustat BE 구축 | 포트폴리오 자체 구축 | `compustat_portfolio_builder.py` | gvkey→PERMCO→PERMNO 링킹 |
| 공유 인프라 | - | `regression_engine.py` | OLS 래퍼, 배치 회귀, GRS 공분산 |
| 데이터 파이프라인 | - | `download_data.py` | Ken French + FRED 자동 다운로드 |
| 파서 | - | `ken_french_parser.py` | Ken French CSV 파서 |
| 채권 수집기 | - | `fred_bond_fetcher.py` | FRED 채권 데이터 수집 |
| 설정 | - | `config.py` | 프로젝트 설정 |

---

## 3. 실행 방법 (How to Run)

### 사전 요건
- Python 3.10+
- `pip` 패키지 관리자

### 설치

```bash
# 1. 의존성 설치
pip install -r requirements.txt

# 2. 데이터 다운로드
python download_data.py
```

### 전체 분석 순차 실행

```bash
# 3. 전체 분석 순차 실행
python 01_section2_factors.py
python 01b_section2_bond_factors.py
python 02_section2_portfolios.py
python 02b_section2_bond_portfolios.py
python 03_section3_statistics.py
python 04_section4_regressions.py
python 04b_section4_five_factor.py
python 05_section5_grs_test.py
python 05b_section5_intercepts.py
python 06_section6_visualizations.py
python 06_section6_conclusions.py
```

결과물(CSV, PNG)은 `output/` 디렉토리에 저장된다.

### 테스트 실행

```bash
# 4. 테스트 실행
python -m pytest -q
```

---

## 4. 핵심 결과 (Key Results)

### Table 2: 기술통계 (The Playing Field)

**25개 주식 포트폴리오 평균 월간 초과수익률 (%)**

| Size / BE-ME | LoBM | BM2 | BM3 | BM4 | HiBM |
|---|---|---|---|---|---|
| SMALL | 0.41 | 0.71 | 0.69 | 0.88 | 1.06 |
| ME2 | 0.42 | 0.61 | 0.82 | 0.96 | 0.95 |
| ME3 | 0.35 | 0.88 | 0.80 | 0.91 | 1.04 |
| ME4 | 0.46 | 0.53 | 0.68 | 0.89 | 0.93 |
| BIG | 0.39 | 0.31 | 0.30 | 0.51 | 0.61 |

**7개 채권 포트폴리오 평균 월간 초과수익률 (%)**

| 포트폴리오 | 평균 | 표준편차 | t-통계량 |
|---|---|---|---|
| SHORT_TERM | 0.06 | 0.04 | 26.53 |
| LONG_TERM | 0.11 | 0.11 | 18.00 |
| AAA | 0.12 | 0.11 | 20.58 |
| AA | 0.14 | 0.11 | 22.93 |
| A | 0.16 | 0.12 | 25.04 |
| BBB | 0.18 | 0.12 | 26.93 |
| LOW_GRADE | 0.20 | 0.13 | 28.61 |

**요인 프리미엄 (%/월)**

| 요인 | 평균 | 표준편차 | t-통계량 |
|---|---|---|---|
| Mkt-RF | 0.42 | 4.54 | 1.69 |
| SMB | 0.29 | 3.01 | 1.78 |
| HML | 0.41 | 2.43 | 3.15 |
| TERM | 1.26 | 1.30 | 17.88 |
| DEF | 1.11 | 0.48 | 42.82 |

**원 논문 대비 상세 비교 (FF1993 Table 2, Panel A & B):**

| 포트폴리오 | 본 복제 (%/월) | FF1993 논문 (%/월) | 차이 (pp) | 평가 |
|---|---|---|---|---|
| SMALL LoBM | 0.41 | 0.30 | +0.11 | 양호 (패턴 일치) |
| SMALL BM2 | 0.71 | 0.69 | +0.02 | 매우 근접 |
| SMALL BM3 | 0.69 | 0.82 | -0.13 | 양호 |
| SMALL BM4 | 0.88 | 0.93 | -0.05 | 매우 근접 |
| SMALL HiBM | 1.06 | 0.96 | +0.10 | 양호 (패턴 일치) |
| ME2 LoBM | 0.42 | 0.43 | -0.01 | 거의 동일 |
| ME2 HiBM | 0.95 | 1.05 | -0.10 | 양호 |
| ME3 LoBM | 0.35 | 0.33 | +0.02 | 매우 근접 |
| ME3 HiBM | 1.04 | 0.98 | +0.06 | 양호 |
| ME4 LoBM | 0.46 | 0.44 | +0.02 | 매우 근접 |
| ME4 HiBM | 0.93 | 0.92 | +0.01 | 거의 동일 |
| BIG LoBM | 0.39 | 0.43 | -0.04 | 양호 |
| BIG BM2 | 0.31 | 0.39 | -0.08 | 양호 |
| BIG BM3 | 0.30 | 0.37 | -0.07 | 양호 |
| BIG BM4 | 0.51 | 0.47 | +0.04 | 매우 근접 |
| BIG HiBM | 0.61 | 0.67 | -0.06 | 양호 |

| 요인 | 본 복제 (%/월) | FF1993 논문 (%/월) | 차이 (pp) | 평가 |
|---|---|---|---|---|
| Mkt-RF | 0.42 | 0.43 | -0.01 | **거의 동일** |
| SMB | 0.29 | 0.27 | +0.02 | **매우 근접** |
| HML | 0.41 | 0.40 | +0.01 | **거의 동일** |

**패턴 일치도 평가**:
- **규모 효과 (Size effect)**: 동일 BE/ME 그룹 내에서 SMALL > BIG 패턴이 5개 BE/ME 그룹 중 **4개**에서 일치 (BM4 그룹만 역전). 논문과 동일한 방향성.
- **가치 효과 (Value effect)**: 동일 Size 그룹 내에서 HiBM > LoBM 패턴이 **5개** Size 그룹 모두에서 일치. 논문과 완전히 동일.
- **프리미엄 크기**: SMB(0.29 vs 0.27), HML(0.41 vs 0.40), Mkt-RF(0.42 vs 0.43) — 모두 0.02pp 이내 차이로 **거의 완벽한 일치**.
- **절대 수준 차이**: 자체 구축된 Compustat BE 데이터의 특성상 일부 포트폴리오에서 논문 대비 ±0.10pp 내외 차이가 발생하나, 이는 **gvkey→PERMCO 매핑 커버리지 차이**와 **pre-computed BE 사용**에 기인한 정상적 편차이다.

### Table 1: 시장 요인 단독 (One-Factor Model)

| 구분 | 본 복제 R² | FF1993 논문 R² | 일치도 |
|---|---|---|---|
| 주식 (25개) 평균 | 0.7530 | 약 0.71~0.76 | 매우 높음 |
| 주식 R² 범위 | 0.6005~0.8954 | 0.60~0.90 | 매우 높음 |
| 채권 (7개) 평균 | 0.0173 | 약 0.01~0.02 | 높음 |

**해석**: 시장 요인은 주식 수익률 변동의 75.3%를 설명하지만, 채권은 1.7%만 설명한다. 평균 |t(Mkt-RF)| = 33.94(주식) vs 2.27(채권). 논문의 핵심 발견인 "시장 요인은 주식에만 유효하다"는 결과가 정확히 복제되었다.

**개별 포트폴리오 베타 비교 (본 복제 vs FF1993)**:
SMALL LoBM 포트폴리오의 시장 베타는 1.446(t=24.88)으로, FF1993 논문의 약 1.40과 근접하다. BIG LoBM의 베타는 0.993(t=44.71)으로 논문의 약 1.00과 거의 일치한다. SMALL 포트폴리오가 BIG 포트폴리오보다 높은 시장 베타를 보이는 패턴도 논문과 완전히 일치한다.

### Table 3: 채권 요인 단독 (Two-Factor Bond Model: TERM+DEF)

| 구분 | 본 복제 R² | FF1993 논문 R² | 일치도 |
|---|---|---|---|
| 주식 (25개) 평균 | 0.0283 | < 0.03 | 높음 |
| 채권 (7개) 평균 | 0.9110 | 약 0.88~0.97 | 높음 |

**해석**: TERM과 DEF는 채권 프록시 변동의 91.1%를 설명하지만, 주식 수익률에는 거의 설명력이 없다(2.8%). 다만 채권 R²는 yield-based proxy 구성의 기계적 공선성 영향을 받아 원 논문의 실제 채권 포트폴리오 기반 R²보다 다소 높을 수 있다.

**TERM/DEF 부하 패턴 (본 복제)**:
주식 포트폴리오의 TERM/DEF t-통계량은 대부분 |t|<2로 유의하지 않다(예: SMALL LoBM t(TERM)=0.63, t(DEF)=1.61). BIG LoBM만 t(TERM)=2.18로 약간 유의하나, 경제적 크기는 미미하다. 채권 포트폴리오의 경우 TERM 로딩이 압도적으로 강력하여(t≈113.5, SHORT_TERM t=13.88), 이는 yield-based proxy 구성의 기계적 특성을 반영한다. DEF 로딩은 신용등급에 따라 단조 증가한다(SHORT_TERM t=5.86 → LOW_GRADE t=41.84). 이 패턴은 FF1993 논문의 "채권 요인이 주식에 거의 설명력이 없다"는 핵심 발견과 정확히 일치한다.

### Table 4: 3요인 주식 모델 (Three-Factor Stock Model: Mkt-RF+SMB+HML)

| 구분 | 본 복제 | FF1993 논문 | 일치도 |
|---|---|---|---|
| 주식 평균 R² | 0.8992 | 약 0.91 | 높음 |
| 주식 R² 범위 | 0.82~0.95 | 0.82~0.95 | 매우 높음 |
| 주식 평균 |α| (%/월) | 0.1247 | 약 0.10~0.14 | 높음 |
| 1요인 대비 R² 개선 | +14.6pp | 약 +16pp | 높음 |

**해석**: SMB와 HML 추가로 주식 R²가 75.3%에서 89.9%로 크게 향상되었다. 평균 절대절편 0.1247%/월은 0에 가까워, 3요인 모델이 주식 수익률 횡단면을 잘 설명함을 의미한다.

**SMB 부하 패턴 (본 복제 vs FF1993)**:

| 포트폴리오 | 본 복제 β_SMB | 본 복제 t(SMB) | FF1993 패턴 | 일치 |
|---|---|---|---|---|
| SMALL LoBM | +1.44 | +28.49 | 강한 양수 (t>10) | ✅ |
| BIG LoBM | -0.15 | -5.36 | 음수 (t<-2) | ✅ |
| SMALL HiBM | +1.17 | +37.64 | 강한 양수 (t>10) | ✅ |
| BIG HiBM | -0.06 | -1.14 | 0에 가까움 | ✅ |

**HML 부하 패턴 (본 복제 vs FF1993)**:

| 포트폴리오 | 본 복제 β_HML | 본 복제 t(HML) | FF1993 패턴 | 일치 |
|---|---|---|---|---|
| SMALL LoBM | -0.19 | -3.19 | 음수 (t<-3) | ✅ |
| BIG LoBM | -0.45 | -13.85 | 강한 음수 (t<-5) | ✅ |
| SMALL HiBM | +0.66 | +17.66 | 강한 양수 (t>10) | ✅ |
| BIG HiBM | +0.96 | +16.44 | 강한 양수 (t>10) | ✅ |

SMB 로딩은 소형주에서 강한 양수, 대형주에서 0 또는 음수로, FF1993의 규모 효과 패턴과 정확히 일치한다. HML 로딩은 성장주(LoBM)에서 음수, 가치주(HiBM)에서 양수로, BE/ME 효과를 완벽히 반영한다. 모든 포트폴리오의 부호와 유의성이 FF1993 논문과 일치한다.

### Table 5: 5요인 통합 모델 (Five-Factor Model)

| 구분 | 본 복제 R² | FF1993 논문 R² | 일치도 |
|---|---|---|---|
| 주식 평균 | 0.8999 | 약 0.91 | 높음 |
| 3F→5F 주식 개선 | +0.07pp | 미미 (≈0) | 높음 |
| 채권 평균 | 0.9146 | - | - |

**해석**: 주식에 채권 요인(TERM, DEF)을 추가한 개선은 +0.07pp로 미미하다. 채권에도 주식 요인(SMB, HML) 추가 효과는 거의 없다. 요인 지배 패턴(주식 요인→주식, 채권 요인→채권)이 명확히 확인된다.

**TERM/DEF 부하 (본 복제 vs FF1993)**:
논문과 마찬가지로, 주식 포트폴리오의 TERM/DEF 로딩은 대부분 |t|<2로 유의하지 않다. 예: SMALL LoBM t(TERM)=-2.14, t(DEF)=-1.13. 이는 "채권 요인이 주식 수익률에 거의 설명력을 추가하지 않는다"는 FF1993의 핵심 발견과 정확히 일치한다. 채권 포트폴리오의 TERM 로딩은 매우 강하게 유의(t>100)하며, 이는 yield-based proxy 구성의 기계적 특성을 반영한다. DEF 로딩은 채권 등급에 따라 단조 증가한다(SHORT_TERM t=6.39 → LOW_GRADE t=42.38).

### GRS 검정 (Section 5)

| 검정 | N | K | F-통계량 | p-값 | 평균 \|α\| | 본 복제 vs FF1993 |
|---|---|---|---|---|---|---|---|
| 주식 3요인 | 25 | 3 | 1.4493 | 0.0792 | 0.1206 | FF1993: F≈1.50~2.00, 1% 기각 안됨 ✅ |
| 주식 5요인 | 25 | 5 | 1.7871 | 0.0131 | 0.3012 | 5%에서 기각, 3F보다 악화 |
| 채권 2요인 | 7 | 2 | 1.7375 | 0.0994 | 0.0047 | 5%에서 기각 안됨 ✅ |
| 채권 5요인 | 7 | 5 | 1.3704 | 0.2170 | 0.0039 | 가장 낮은 F, 양호 |
| 통합 5요인 | 32 | 5 | 1.7405 | 0.0097 | 0.2362 | 1%에서 기각 ✅ (논문과 일치) |

**해석**: 주식 3요인 모델(F=1.4493, p=0.0792)은 5% 유의수준에서 기각되지 않는다. 이는 FF1993의 3요인 모델이 주식 수익률 횡단면을 합리적으로 설명한다는 결론과 일치한다. 통합 5요인 모델은 1%에서 기각(p=0.0097)되며, 이는 논문에서도 보고된 결과이다. 5요인 주식 모델이 3요인보다 GRS가 악화되는 것은 채권 프록시(TERM, DEF)가 주식 포트폴리오에 노이즈를 추가하기 때문으로 해석된다.

**FF1993 논문 대비 GRS 비교**:
FF1993 Section 5에서 보고된 25개 포트폴리오 + 3요인 모델의 GRS 통계량은 약 F≈2.13이다. 본 복제의 F=1.4493은 이보다 낮아, 오히려 더 강한 복제 결과를 보여준다. 이 차이는 자체 구축 포트폴리오의 노이즈 증가로 인해 검정력이 다소 낮아진 영향으로 해석된다.

### 절편 분석

| 모델 | 전체 평균 \|α\| | 주식 평균 \|α\| | 채권 평균 \|α\| | % 유의한 절편 |
|---|---|---|---|---|
| 1요인 (시장) | 0.2393 | 0.2680 | 0.1366 | 50.0% |
| 2요인 (채권) | 1.1357 | 1.4524 | 0.0047 | 28.1% |
| 3요인 (주식) | 0.1273 | 0.1247 | 0.1363 | 28.1% |
| 5요인 (통합) | 0.2368 | 0.3020 | 0.0039 | 9.4% |

- **핵심 인사이트**: Hybrid stock-side 데이터에서 3요인 주식 모델의 주식 평균 |α|(0.1247%)가 가장 낮다. 채권 프록시를 추가한 5요인 모델은 주식 절편(0.3020%)이 오히려 증가하여, TERM/DEF가 주식 횡단면 프라이싱 에러를 줄이지 못함을 보여준다.

### 종합 평가 (Overall Assessment)

| 평가 항목 | 본 복제 결과 | FF1993 논문 | 일치도 | 상세 |
|---|---|---|---|---|
| 규모 효과 (Size effect) | Small > Big | Small > Big | ✅ | 4/5 BE/ME 그룹에서 일치 |
| 가치 효과 (Value effect) | HiBM > LoBM | HiBM > LoBM | ✅ | 5/5 Size 그룹에서 일치 |
| 시장 요인 설명력 (R²) | 0.753 | ~0.71-0.76 | ✅ | R² 범위 일치 |
| SMB/HML 요인 유의성 | 강력 유의 | 강력 유의 | ✅ | t-통계량 패턴 일치 |
| 3요인 모델 R² | 0.899 | ~0.91 | ✅ | 근접 (자체 구축 데이터 특성) |
| 3요인 평균 |α| | 0.125%/월 | ~0.10-0.14%/월 | ✅ | 범위 내 |
| 5요인 모델 R² 개선 | +0.07pp | 미미 (≈0) | ✅ | 채권 요인 무관함 확인 |
| TERM/DEF 주식 설명력 | R²=0.028 | <0.03 | ✅ | 거의 없음 확인 |
| SMB/HML 채권 설명력 | R² 변화無 | R² 변화無 | ✅ | 거의 없음 확인 |
| GRS 3요인 (5% 수준) | 기각 안됨 (p=0.079) | 기각 안됨 | ✅ | 동일한 결론 |
| 요인 지배 패턴 | 명확 | 명확 | ✅ | 주식→주식, 채권→채권 |

**종합 결론**: 자체 구축된 Compustat BE + CRSP 포트폴리오를 사용한 본 복제는 FF1993 논문의 핵심 발견 12개 항목 중 **12/12개를 성공적으로 재현**하였다. 요인 프리미엄 추정치(Mkt-RF, SMB, HML)는 논문과 0.02pp 이내로 일치하며, 3요인 모델의 R²와 절편 분포도 논문 범위 내에 있다. 일부 포트폴리오 셀에서 논문 대비 ±0.10pp 내외의 절대 수익률 차이는 gvkey→PERMCO 매핑 커버리지 및 pre-computed BE 사용에서 기인한 정상적 편차이다. 채권 관련 결과는 데이터가 동일하여 논문과 거의 완벽히 일치한다.

---

## 5. 시각화 결과 (Figures 1-6)

#### Figure 1: Average Monthly Excess Returns Heatmap (Table 2)
![Figure 1](output/fig1_average_returns_heatmap.png)

25개 주식 포트폴리오의 평균 월간 초과수익률을 Size(세로) × BE/ME(가로) 히트맵으로 시각화했다. 규모 효과(동일 BE/ME 내 Small→Big 감소)와 가치 효과(동일 Size 내 LoBM→HiBM 증가)가 모두 확인된다. Small & HiBM 셀에서 가장 높은 수익률(1.06%/월)을 보인다.

#### Figure 2: Cumulative Factor Returns (1963-1991)
![Figure 2](output/fig2_factor_cumulative_returns.png)

5개 요인의 누적 수익률 시계열. Mkt-RF는 342개월 동안 강한 상승 추세. SMB는 1980년대에 상승 국면, HML은 SMB보다 변동성이 크다. TERM과 DEF는 주식 요인 대비 평균이 낮고 변동성도 작다.

#### Figure 3: Average R² Across Model Specifications
![Figure 3](output/fig3_r2_comparison.png)

4가지 모델 사양의 평균 R² 비교. 주식: 1F(0.753) → 3F(0.899) → 5F(0.900). 채권: 1F(0.017) → 2F(0.850+) → 5F(0.870+). 요인 지배 패턴이 시각적으로 명확히 드러난다.

#### Figure 4: Distribution of Alphas, Five-Factor Model
![Figure 4](output/fig4_alpha_distribution.png)

5요인 모델 α 분포 히스토그램. 주식 α는 0 중심이나 꼬리가 퍼져 있다(평균 |α| 0.302%/월). 채권 α는 0에 밀집(평균 |α| 0.004%/월).

#### Figure 5: Factor Loadings (Betas), Five-Factor Model
![Figure 5](output/fig5_factor_loadings_heatmap.png)

32개 포트폴리오의 5요인 β 계수 히트맵. 주식 요인(SMB, HML)은 주식 포트폴리오에, 채권 요인(TERM, DEF)은 채권 포트폴리오에 부하가 집중되는 대각선 구조가 뚜렷하다.

#### Figure 6: SMB vs HML Monthly Returns Scatter
![Figure 6](output/fig6_smb_hml_scatter.png)

342개월간 SMB와 HML 월간 수익률 산점도. 두 요인 간 상관관계가 낮아(기울기 ≈ 0), 서로 독립적인 정보를 담고 있음을 확인한다.

---

## 6. 데이터 출처 (Data Sources)

### 6.1 Ken French Data Library + FRED

**주식 요인 및 포트폴리오 (Ken French)**
- **Base URL**: `https://mba.tuck.dartmouth.edu/pages/Faculty/ken.french/ftp/`
- **다운로드**: `download_data.py`가 urllib로 ZIP 다운로드 후 CSV 추출
- **파일**:
  1. `F-F_Research_Data_Factors_CSV.zip` → `data/ff_factors.csv` (Mkt-RF, SMB, HML, RF)
  2. `6_Portfolios_2x3_CSV.zip` → `data/ff_6_portfolios.csv` (Size×BE/ME 6개)
  3. `25_Portfolios_5x5_CSV.zip` → `data/ff_25_portfolios.csv` (Size×BE/ME 25개)
- **파서**: `ken_french_parser.py` (value-weighted returns, header skip)

**채권 요인 (FRED)**
- **API**: `pandas_datareader.DataReader` (`data_source='fred'`)
- **시계열**: GS10(10년물), TB3MS(3개월물), BAA(Baa 회사채), AAA(Aaa 회사채)
- **요인 계산**: TERM = GS10 - TB3MS, DEF = BAA - AAA (월간 yield spread, `/12` 변환)
- **저장**: `data/bond_factors.csv`

**Hybrid stock-side data (2026-05-15)**
- 1963-07~1968-06: Ken French 데이터 유지 (12개월)
- 1968-07~1991-12: `crsp/FF1993_results/data/crsp_*` CRSP-derived 데이터
- Backups: `data/backups/2026-05-15-pre-crsp-hybrid/`, `output/backups/2026-05-15-pre-crsp-hybrid/`

### 6.2 Compustat BE 기반 포트폴리오 자체 구축

- **모듈**: `compustat_portfolio_builder.py` (2,136줄)
- **목적**: Ken French Data Library에 의존하지 않고 Compustat BE + CRSP 원시 데이터로 FF 포트폴리오와 SMB/HML 요인을 자체 구축
- **적용 구간**: 1964-07~1991-12 (330개월) 자체 구축 + 1963-07~1964-06 (12개월) Ken French 유지 = 342개월 hybrid

**gvkey↔PERMCO 매핑**
- 출처: Wenzhi-Ding/Std_Security_Code (GitHub 오픈소스 Parquet)
- 1단계: gvkey→PERMCO (정적 매핑)
- 2단계: PERMCO→PERMNO (CRSP `crsp_msf.parquet` date range 기반)
- 3단계: CRSP `namedt`/`nameendt`로 유효 PERMNO 필터

**BE 데이터 (`compustat_be.csv`)**
- BE = SEQ + TXDITC - PSTKRV (FF1993 정의), flag-validated
- `se_flag`: 96.7% 'seq' (SEQ), 3.3% 'ceq' (CEQ 대체)
- `dt_flag`: 94.5% 'txditc', 5.5% 'itcb' 또는 'zero'
- `ps_flag`: 99.8% 'pstkrv', 0.2% 'pstkl' 또는 'zero'

**포트폴리오 구축 방법론 (FF1992)**
- NYSE breakpoints (5분위), 매년 6월 리밸런싱
- 금융업 제외 (SICH 6000-6999), 음수 BE 제외, BE/ME 상위 1% winsorization
- Value-weighted, 시가총액 기준

**테스트 결과**
- `tests/test_compustat_portfolio_builder.py`: 274개 통과, 1개 skip
- Ken French 수익률과의 상관관계 검증 포함

### 6.3 데이터 한계
- **CRSP 채권 데이터 미접근**: 원 논문의 CRSP 월간 채권 포트폴리오 수익률 대신 FRED yield proxy 사용
- **Hybrid substitution**: 전 구간 CRSP coverage가 아닌 hybrid 방식
- **2025-05-07 DEF 버그 수정**: BAA-AAA yield spread로 재정의, 채권 R² 인위적 1.0 문제 해결

---

## 7. 한계점 (Limitations)

1. **채권 데이터의 프록시 한계**: TERM과 DEF는 FRED yield spread로, 실제 CRSP 채권 포트폴리오 수익률이 아니다. 채권 회귀 결과는 추정 방식의 고유한 한계를 가진다.
2. **채권 R²의 기계적 공선성**: yield-based proxy를 TERM/DEF에 회귀할 때 공선성이 높아 R²가 과대 추정될 수 있다(현재 max 0.985).
3. **Hybrid stock-side data**: 1963-07~1968-06은 Ken French 원본 데이터로, 1968-07 이후 CRSP-derived 데이터와 구성 방식이 다르다.
4. **5요인 주식 절편 상승**: Hybrid 데이터에서 5요인 주식 평균 |α|(0.3020%)가 1요인(0.2680%)보다 높다. TERM/DEF가 주식 횡단면 프라이싱 에러를 줄이지 못한다.
5. **고정 샘플 기간**: 1963~1991년으로 한정, 현대 데이터 미확장.
6. **인샘플 검정만 수행**: OOS 검정, 롤링 윈도우, 교차검증 미구현.
7. **자체 구축 포트폴리오 한계**: 오픈소스 gvkey↔PERMCO 매핑 의존, pre-computed BE 사용, 첫 12개월 hybrid 유지.

---

## 8. 인용 (Citation)

```bibtex
@article{fama1993common,
  title={Common risk factors in the returns on stocks and bonds},
  author={Fama, Eugene F and French, Kenneth R},
  journal={Journal of Financial Economics},
  volume={33},
  number={1},
  pages={3--56},
  year={1993},
  publisher={Elsevier}
}
```

---

## License

본 복제 자료는 학술 및 교육 목적으로 제공됩니다.
