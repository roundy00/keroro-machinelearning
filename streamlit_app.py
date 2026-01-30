import streamlit as st
import pandas as pd
import plotly.express as px

# 페이지 설정 (탭 이름, 아이콘 등)
st.set_page_config(page_title="실시간 서버 모니터링",  # 원하는 이름으로 변경
                   page_icon="🚀",            # 이모지나 파일 경로
                   layout="wide"              # 레이아웃 설정(선택 사항)
)
st.title('🤖 서버 실시간 이상 탐지 대시보드 🤖')

st.info('이 앱은 머신러닝 모델을 활용하여 실시간으로 서버 상태를 모니터링할 수 있게 시각화한 대시보드를 제공합니다')

machine_num = ['1-1', '1-2', '1-3', '1-4', '1-5', '1-6', '1-7', '1-8',
                    '2-1', '2-2', '2-3', '2-4', '2-5', '2-6', '2-7', '2-8', '2-9',
                    '3-1', '3-2', '3-3', '3-4', '3-5', '3-6', '3-7', '3-8', '3-9', '3-10', '3-11']

# Machine selection
with st.sidebar:
  st.header('Monitoring Settings')

  selected_machine = st.sidebar.selectbox('대상 머신 선택', [f'machine-{i}' for i in machine_num])

# Column Rename (Data Preprocess)
df = pd.read_csv(f'https://raw.githubusercontent.com/roundy00/keroro-machinelearning/refs/heads/master/Server-Machine-Dataset-main/processed_csv/{selected_machine}/{selected_machine}_test.csv')
new_column_names = [
  'cpu_r', 'load_1', 'load_5', 'load_15', 'mem_shmem', 'mem_u', 'mem_u_e', 'total_mem',
  'disk_q', 'disk_r', 'disk_rb', 'disk_svc', 'disk_u', 'disk_w', 'disk_wa', 'disk_wb',
  'si', 'so', 'eth1_fi', 'eth1_fo', 'eth1_pi', 'eth1_po', 'tcp_tw', 'tcp_use',
  'active_opens', 'curr_estab', 'in_errs', 'in_segs', 'listen_overflows', 'out_rsts',
  'out_segs', 'passive_opens', 'retransegs', 'tcp_timeouts', 'udp_in_dg', 'udp_out_dg',
  'udp_rcv_buf_errs', 'udp_snd_buf_errs']
rename_dict = {f'col_{i}': new_column_names[i] for i in range(len(new_column_names))}
df.rename(columns=rename_dict, inplace=True)
priority_columns = [
  'timestamp', 'cpu_r', 'load_1', 'load_5', 'mem_u',
  'disk_q', 'disk_r', 'disk_w', 'disk_u', 'eth1_fi', 'eth1_fo','tcp_timeouts']

priority_columns_test = priority_columns + ['label']
df = df[priority_columns_test]
X = df.drop(labels = 'label', axis=1)
y = df.label

# 슬라이더에서 선택된 범위만큼 데이터 자르기
display_df = df.iloc[time_range[0] : time_range[1] + 1]

# Data Preparation : Model selection, time range setting
with st.sidebar:
  model_type = st.sidebar.radio('분석 모델 종류', ["ML (RandomForest)","ML (XGBoost)","DL (OmniAnomaly)", "DL (LSTM-NDT)", "DL (IMDiffusion)", "DL (Anomaly Transformer)", "DL (Pi-Transformer)"])
  time_range = st.select_slider('분석할 시간 범위', options = range(0, len(df)), value = (15000,22000))

# 메인 페이지에 현재 선택 정보 보여주기
selected_info = {'machine':selected_machine,
                 'model':model_type,
                 'start time':time_range[0],
                 'end time':time_range[1]}
input_info = pd.DataFrame([selected_info])
st.dataframe(input_info, hide_index=True)

with st.expander('Data'):
  st.write('**Raw Data**')
  df

with st.expander('Feature visualization'):
    # 시각화할 컬럼들 리스트
    viz_cols = ['cpu_r', 'disk_r', 'mem_u', 'tcp_timeouts']
    
    for col in viz_cols:
        # 1. Plotly로 라인 차트 생성
        fig = px.line(display_df, x='timestamp', y=col, title=f'Server {col} Over Time')
        
        # 2. 상호작용(줌, 팬) 비활성화 설정
        fig.update_layout(
            xaxis=dict(fixedrange=True), # X축 고정
            yaxis=dict(fixedrange=True), # Y축 고정
            dragmode=False,               # 마우스 드래그 비활성화
            hovermode='x'                # 마우스를 올렸을 때 값만 보여줌
        )
        
        # 3. Streamlit에 출력 (config에서 도구 모음도 숨김)
        st.plotly_chart(fig, use_container_width=True, config={'displayModeBar': False})
