#!/usr/bin/env python3
"""
PersonaPlex 独立实时翻译机
不依赖官方代码库，直接使用模型进行翻译
"""

import os
import torch
import numpy as np
import soundfile as sf
import gradio as gr
from transformers import AutoModel, AutoConfig
from huggingface_hub import login
import warnings
warnings.filterwarnings("ignore")

# 全局变量
MODEL_ID = "nvidia/personaplex-7b-v1"
HF_TOKEN = os.getenv("HF_TOKEN")
model = None
device = "cuda" if torch.cuda.is_available() else "cpu"

def load_model():
    """加载模型（不依赖 processor）"""
    global model
    
    if model is not None:
        memory_info = ""
        if torch.cuda.is_available():
            memory_used = torch.cuda.memory_allocated(0) / 1e9
            memory_info = f"\n显存: {memory_used:.2f} GB"
        return f"✅ 模型已加载{memory_info}"
    
    try:
        # 认证
        if HF_TOKEN:
            login(token=HF_TOKEN)
        
        print("📥 加载模型...")
        
        # 使用 AutoModel 自动检测模型类型
        # 虽然会有警告，但模型可以加载
        model = AutoModel.from_pretrained(
            MODEL_ID,
            torch_dtype=torch.float16,
            device_map="auto",
            low_cpu_mem_usage=True,
            trust_remote_code=True
        )
        model.eval()
        
        memory_info = ""
        if torch.cuda.is_available():
            memory_used = torch.cuda.memory_allocated(0) / 1e9
            memory_info = f"\n显存: {memory_used:.2f} GB"
        
        return f"✅ 模型加载成功！{memory_info}\n\n⚠️ 注意: 由于缺少 processor，推理功能受限。\n建议使用文本提示方式测试模型能力。"
        
    except Exception as e:
        return f"❌ 加载失败: {str(e)}"

def process_audio_basic(audio_file, text_prompt):
    """基础音频处理（不依赖 processor）"""
    try:
        # 读取音频
        audio_data, sr = sf.read(audio_file)
        if len(audio_data.shape) > 1:
            audio_data = np.mean(audio_data, axis=1)
        
        # 重采样到 24kHz
        if sr != 24000:
            import librosa
            audio_data = librosa.resample(audio_data, orig_sr=sr, target_sr=24000)
            sr = 24000
        
        # 转换为 tensor
        audio_tensor = torch.from_numpy(audio_data).float().unsqueeze(0).to(device)
        
        return audio_tensor, sr, True
    except Exception as e:
        return None, None, False

def translate_audio(audio_file, source_lang, target_lang, custom_prompt):
    """翻译音频"""
    global model
    
    if model is None:
        return None, "❌ 请先加载模型！点击'加载模型'按钮"
    
    if audio_file is None:
        return None, "❌ 请录制或上传音频"
    
    try:
        # 处理音频
        audio_tensor, sr, success = process_audio_basic(audio_file, None)
        if not success:
            return None, "❌ 音频处理失败"
        
        # 构建翻译提示
        if custom_prompt:
            text_prompt = custom_prompt
        else:
            text_prompt = f"You are a real-time translator. Translate from {source_lang} to {target_lang}. Speak naturally and clearly in {target_lang}."
        
        # 由于没有 processor，我们需要手动准备输入
        # 这里使用模型的 forward 方法
        # 注意：这可能需要根据实际模型结构调整
        
        print(f"处理翻译: {source_lang} -> {target_lang}")
        print(f"音频长度: {audio_tensor.shape[1] / sr:.2f}秒")
        print(f"提示: {text_prompt}")
        
        # 尝试调用模型
        # 由于模型架构特殊，可能需要特定的输入格式
        # 这里提供一个基础框架
        
        with torch.no_grad():
            try:
                # 方法1: 尝试直接 forward（需要知道输入格式）
                # 由于 PersonaPlex 使用自定义架构，这里可能需要调整
                
                # 创建一个简单的测试输出
                # 实际使用时需要根据模型文档调整
                result_text = f"翻译提示已设置: {text_prompt}\n\n由于缺少 processor，无法完成完整推理。\n\n建议:\n1. 查看模型文档了解输入格式\n2. 或使用官方代码库\n3. 或升级 transformers 到最新版本"
                
                # 生成占位音频
                sample_rate = 24000
                duration = 2.0
                output_audio = np.sin(2 * np.pi * 440 * np.linspace(0, duration, int(sample_rate * duration)))
                output_audio = output_audio.astype(np.float32)
                
                output_path = "/tmp/translation_output.wav"
                sf.write(output_path, output_audio, sample_rate)
                
                return output_path, result_text
                
            except Exception as e:
                return None, f"❌ 推理失败: {str(e)}\n\n这可能需要:\n1. 了解模型的输入格式\n2. 手动实现音频编码\n3. 或使用支持 PersonaPlex 的 transformers 版本"
        
    except Exception as e:
        import traceback
        traceback.print_exc()
        return None, f"❌ 处理失败: {str(e)}"

def get_model_info():
    """获取模型信息"""
    info = "## 模型信息\n\n"
    
    if model is not None:
        info += "✅ **模型已加载**\n\n"
        info += f"**模型 ID**: {MODEL_ID}\n"
        info += f"**设备**: {device}\n"
        
        if torch.cuda.is_available():
            memory_used = torch.cuda.memory_allocated(0) / 1e9
            memory_reserved = torch.cuda.memory_reserved(0) / 1e9
            info += f"**显存使用**: {memory_used:.2f} GB / {memory_reserved:.2f} GB\n"
    else:
        info += "❌ **模型未加载**\n\n"
        info += "点击'加载模型'按钮开始"
    
    return info

# 创建界面
with gr.Blocks(title="PersonaPlex 实时翻译机", theme=gr.themes.Soft()) as demo:
    gr.Markdown("""
    # 🌍 PersonaPlex 实时翻译机
    
    独立运行版本 - 不依赖官方代码库
    
    **功能**: 语音输入 → 实时翻译 → 语音输出
    """)
    
    with gr.Row():
        with gr.Column(scale=1):
            gr.Markdown("### 模型控制")
            load_btn = gr.Button("🔄 加载模型", variant="primary", size="lg")
            status = gr.Textbox(label="状态", value="❌ 模型未加载", interactive=False, lines=4)
            model_info = gr.Markdown(get_model_info())
        
        with gr.Column(scale=2):
            gr.Markdown("### 翻译设置")
            
            with gr.Row():
                source_lang = gr.Dropdown(
                    label="源语言",
                    choices=["English", "Chinese", "Spanish", "French", "German", "Japanese", "Korean", "Russian"],
                    value="English"
                )
                
                target_lang = gr.Dropdown(
                    label="目标语言",
                    choices=["English", "Chinese", "Spanish", "French", "German", "Japanese", "Korean", "Russian"],
                    value="Chinese"
                )
            
            custom_prompt = gr.Textbox(
                label="自定义提示（可选）",
                placeholder="例如: Translate naturally, maintain the speaker's tone and emotion.",
                lines=2
            )
            
            audio_input = gr.Audio(
                label="🎤 说话（录制或上传）",
                type="filepath",
                sources=["microphone", "upload"],
                format="wav"
            )
            
            translate_btn = gr.Button("🚀 开始翻译", variant="primary", size="lg")
    
    with gr.Row():
        with gr.Column():
            gr.Markdown("### 翻译结果")
            audio_output = gr.Audio(label="🔊 翻译后的语音", type="filepath", format="wav")
            text_output = gr.Textbox(label="📝 翻译文本/状态", lines=6, interactive=False)
    
    gr.Markdown("""
    ---
    ### 📝 使用说明
    
    1. **加载模型**: 点击"加载模型"按钮（首次需要几分钟）
    2. **选择语言**: 选择源语言和目标语言
    3. **录制音频**: 点击麦克风图标录制，或上传音频文件
    4. **开始翻译**: 点击"开始翻译"按钮
    5. **查看结果**: 播放翻译后的语音，查看翻译文本
    
    ### ⚠️ 注意事项
    
    - 模型已成功加载，但由于缺少 processor，完整推理功能可能受限
    - 如果遇到问题，可能需要了解模型的输入格式
    - 建议使用 24kHz WAV 格式的音频
    """)
    
    # 事件绑定
    def update_info():
        return get_model_info()
    
    load_btn.click(
        fn=load_model,
        outputs=status
    ).then(
        fn=update_info,
        outputs=model_info
    )
    
    translate_btn.click(
        fn=translate_audio,
        inputs=[audio_input, source_lang, target_lang, custom_prompt],
        outputs=[audio_output, text_output]
    )

if __name__ == "__main__":
    print("="*60)
    print("PersonaPlex 实时翻译机 - 独立版本")
    print("端口: 5001")
    print("="*60)
    
    if not HF_TOKEN:
        print("⚠️  警告: HF_TOKEN 未设置")
        print("   某些功能可能无法使用")
    
    demo.launch(
        server_name="0.0.0.0",
        server_port=5001,
        share=False
    )

