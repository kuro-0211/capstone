# PetMind VS Code 작업 인계

기준일: 2026-10-11. 최신 상태는 `docs/STATUS.md`와 루트 `README.md`를 읽는다. 최초 통합 계획의 당시 원본은 `legacy/initial-source-docs/PetMind_통합_개발_계획_2026-10-07.md`에 보관했다. 파트별 결과는 `docs/01_*`부터 기록했다.

## 확정 범위

현재 기준 저장소는 `kuro-0211/capstone`의 루트다. 급식기는 제외한다. `wuerphe39/capstone_really`의 분석과 이 저장소의 이전 시제품에서 FastAPI·SQLite·Flutter·Gemini 코드를 선별 통합했다. 이전 시제품 전체는 `legacy/2026-09-prototype/`에 보관한다. LSTM·음성 관찰 → 개별 기록 검색/MCP → 케어 제안 → 보호자 승인 → 가상 음악 → 이력을 전체 시연으로 만든다.

## 현재 검증된 상태

- 이전 로컬 개발 환경에서 전용 `.venv` 설치·`pip check` 정상. 새 복제본에서는 루트 `README.md`의 설치 명령을 먼저 실행한다.
- 모델 산출물이 있는 개발 환경에서 Python 테스트 66개 통과. 모델 없는 새 복제본은 65개 통과·1개 건너뜀.
- Flutter 기능 테스트 2개, 분석·웹 릴리스 빌드 통과.
- 합성 시나리오 3종, 공개 WAV·공개 이미지 재생 영상의 실제 HTTP 전체 처리 확인.
- 공식 MCP SDK 2.3.0으로 별도 stdio 서버의 도구 3개를 실제 호출했다.
- 가상 음악 수신·완료·실패·30초 무응답, 서버 재시작 후 이력 보존 확인.
- 프로필·보호자 피드백·타임라인·처리 수치·전후 비교·평소 패턴의 자료 부족 처리 연결.
- 실제 API 응답을 Flutter 렌더러로 캡처한 `artifacts/flutter_dashboard.png` 생성. 실제 브라우저 클릭/영상은 아직 미검증.

## 완료로 주장하면 안 되는 항목

- Gemini 키를 로컬 `.env`에 설정하고 실제 RAG·MCP·인용·HTTP 시나리오를 검증했다. 키를 채팅·문서·Git에 기록하지 않는다. 파트 14를 확인한다.
- LSTM 100%는 합성 테스트 성적이다. 실제 반려견 행동 정확도는 미검증이다.
- 에너지 감지는 짖음 후보이며 공개 대조 음원에서 오탐이 있다.
- DAVIS 이미지 시퀀스는 5fps 시연 재생용 영상으로 구성했다. 원본 녹화 시간과 다르며 카메라 움직임을 보정하지 않았다.
- 전후 비교는 합성 관찰 차이다. 실제 Pi의 가상 에이전트 왕복은 파트 20에서 검증했다. 음악의 실제 효과·물리 재생·센서는 검증하지 않았다.
- 실제 장기 기록이 없어 평소 기준선의 실제 적용은 미검증이다.

## 실행·검증

저장소 루트에서:

```powershell
.\.venv\Scripts\python.exe -m pytest tests petmind\backend\tests -q -p no:cacheprovider
.\.venv\Scripts\python.exe -m uvicorn petmind.backend.main:app --host 127.0.0.1 --port 8010
.\.venv\Scripts\python.exe -m petmind.device_agent
```

화면은 `petmind_app`에서 `flutter run -d chrome --web-port 8021` 또는 `README.md`의 웹 빌드 실행법을 사용한다. 실제 통합 검증은 `scripts.verify_flow`, `verify_media_flow`, `verify_faults`, `verify_extras`를 사용한다. 장애 검증 중에는 상시 가상 장치를 끈다.

## 이어갈 작업

최신 실험은 `docs/27_InterPet4D_적용_평가.md`와 `docs/28_추적_ID_재연결_개선.md`다. 실제 공개 자료로 후보 v3를 학습했지만 영상 성능이 악화해 `artifacts/lstm_interpet/trajectory_lstm.pt`에 별도로 보관했다. 운영 v2를 덮어쓰지 않는다. 추적 ID 재획득과 약 15fps 추적 갱신으로 보류견 영상의 선택 프레임이 늘었지만 10초 연속 구간을 만들지 못해 분류는 여전히 `unknown`이다. 시간별 실제 행동 정답 확보와 짧은 입력용 별도 모델 검증이 다음 단계다.

후속 공개 데이터 실험은 `docs/29_A2D_공개영상_행동실험.md`, `docs/30_A2D_공식주석_개탐지_평가.md`, `docs/31_중복_개박스_추적개선.md`다. 공식 A2D 개 행동 영상 189편과 주석 585프레임을 준비했다. 중복 박스 제거 후 3초 유효 궤적은 기본 탐지기로 58편, 미세조정 후보로 87편이었다. 두 3초 LSTM은 검증 임계값에서 공식 테스트 이동을 모두 놓쳐 미채택했다. 탐지기 후보는 A2D 주석의 탐색적 테스트에서 박스 재현율 61.8%→82.4%, 정밀도 94.4%→87.5%였으나 InterPet·TigDog의 4종 행동 출력은 개선되지 않았다. 기본 YOLOv8n과 기본 v2 LSTM은 유지하고 **중복 박스 제거만 기본 경로에 적용**했다. 후보는 `artifacts/a2d_detector/`와 `artifacts/a2d_short/`에 분리 보관한다. 다음 작업은 고정 카메라의 시간별 4종 라벨 및 외부 독립 탐지 정답 확보, 추적 연속성 개선이다.

실제 성능 측정은 `docs/25_실제데이터_성능비교.md`를 우선 읽는다. 공식 TigDog 행동 라벨과 원본 개 영상 24개를 확보했다. 원본 시각·라벨·개체 조건을 통과한 이동 사례 9개에서 v1/v2 재현율 모두 44.4%, unknown 5개였다. 4종 전체 정확도와 개선은 입증되지 않았다. 새 테스트 데이터로 튜닝하지 않았으며 모델은 유지했다. `scripts.evaluate_tigdog --input-mode original`로 재현한다. 다음 개선은 추적 실패·카메라 이동 영향과 독립 실내 라벨 데이터다.

최신 변경은 `docs/22_*`, `23_*`, `24_*`다. 공식 개 모션 51파일을 사전학습에 사용했고 촬영 그룹 분리·해시 검사·8개 특징·unknown 처리를 추가했다. 실제 모션 테스트는 단순 기준보다 오차가 커 성능 향상 미확인이다. RAG는 한국 시간 기간·피드백 검색·실제 Gemini 임베딩·캐시가 적용됐다. 자체 20질문 Recall@5 100%는 실제 사용자 전체 정확도가 아니다. 모델 v1 백업은 `artifacts/lstm/trajectory_lstm_v1_backup.pt`, v2는 기존 기본 체크포인트 경로에 설치했다. `.env`의 `PETMIND_SEMANTIC_SEARCH=on`을 유지한다.

브라우저 클릭·시연 영상은 아직 검증 기록이 없다. 이전 세션의 연결 문제는 `docs/17_브라우저_연결준비.md`에 기록했으며, 새 환경에서 브라우저 연결 상태를 다시 확인한다.

1. 저장소의 최신 커밋과 `docs/STATUS.md`, 파트별 기록을 확인한다. `legacy/`는 현재 실행 경로와 분리한다.
2. Gemini 실제 호출은 검증됐다. `.env` 변경 후 서버를 재시작하고 제공자를 확인한다. 실제 브라우저 시연을 이어서 검증한다.
3. 최종 화면 렌더링·브라우저 연속 시연·발표 증거를 확보한다.
4. 실제 장비와 실제 라벨·장기 기록으로 최종 졸업작품 검증을 이어간다.

VS Code 채팅에 붙여넣기:

> 이 저장소의 `AGENTS.md`, `README.md`, `VSCODE_HANDOFF.md`, `docs/STATUS.md`를 읽고 현재 변경을 보존한 채 전체 목표를 이어서 진행해 줘. `legacy/`는 이전 시제품 보관용이다. 파트가 끝날 때마다 Markdown에 실제 수정·실행 결과를 저장해 줘. 이미 검증한 Gemini 실제 호출과 아직 검증하지 않은 브라우저 시연을 구분하고, 완료 기준을 실제 실행 증거로 확인해 줘.
