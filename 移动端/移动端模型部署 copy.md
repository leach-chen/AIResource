
# 一、模型转换

## 📱 移动端部署方案对比


| 方案技术栈 | 模型转换路径 | 推理引擎 | 核心优点 | 核心缺点/挑战 | 推荐给... |
| :--- | :--- | :--- | :--- | :--- | :--- |
| **OpenCV DNN** | 训练模型 -> **ONNX** | **OpenCV DNN模块** (C++ API) | **1. 集成简单**：OpenCV是计算机视觉标配，无需额外引入大型库。<br>**2. 跨平台**：代码可在Android、iOS、Windows、Linux间复用。<br>**3. 预处理便利**：与OpenCV图像操作无缝衔接。 | **1. 后端支持有限**：移动端GPU加速（Vulkan）支持不稳定，性能通常不如专用引擎。<br>**2. 算子支持不全**：对新版模型的某些特殊算子支持可能滞后。<br>**3. 后处理全手动**：需完全自己实现输出解析，门槛高。 | 项目已重度依赖OpenCV；进行快速原型验证；追求代码在多个平台间的最大复用性。 |
| **ONNX + ONNX Runtime** | 训练模型 -> **ONNX** | **ONNX Runtime** (C++ API) | **1. 性能优化好**：专为ONNX优化，推理速度通常优于OpenCV DNN。<br>**2. 标准与兼容性**：微软官方维护，算子支持全面，版本更新快。<br>**3. 硬件加速**：通过`ExecutionProvider`支持NNAPI、CoreML等，潜力大。 | **1. 库体积较大**：需要额外集成。<br>**2. 后处理手动**：与OpenCV DNN一样，需自行解析输出。 | 希望坚持ONNX标准，并追求比OpenCV DNN更佳性能和可靠性的项目。 |
| **TFLite + TFLite Runtime** | 训练模型 -> ONNX -> **TFLite** | **TensorFlow Lite** (C++ API) | **1. 硬件加速最佳**：通过`Delegate`机制（GPU、NNAPI、自研NPU）支持极佳。<br>**2. 工具链完善**：官方提供量化、裁剪、调试全套工具。<br>**3. 生态强大**：社区资源、预训练模型丰富。 | **1. 转换链略长**：多一步转换，可能引入兼容性问题。<br>**2. 后处理手动**：仍需自行实现。 | 追求最广泛的硬件兼容性和极致性能；愿意接受谷歌技术栈。 |
| **专用框架 (NCNN/MNN)** | 训练模型 -> **NCNN/MNN格式** | **NCNN** 或 **MNN** (C++ API) | **1. 移动端极致优化**：架构专为移动端设计，体积小、速度快。<br>**2. 社区示例丰富**：尤其是NCNN，有大量YOLO的**完整C++实现**（含后处理）。<br>**3. 中文支持好**：由国内公司维护，文档和社区沟通便利。 | **1. 绑定特定框架**：需使用其转换工具和API。<br>**2. 生态相对集中**：主要集中在CV领域。 | **强烈推荐给受困于后处理的你**：可快速找到开箱即用的参考代码，极大节省开发时间。 |
| **原框架运行时 (LibTorch)** | 训练模型 -> **TorchScript** | **LibTorch** (PyTorch C++) | **1. 开发体验一致**：API与PyTorch Python版几乎相同，调试方便。<br>**2. 零转换损失**：无需担心转换导致的精度或算子丢失问题。 | **1. 库体积巨大**（~100MB+），严重影响APK大小。<br>**2. 移动端性能非最优**，功耗较高。 | 用于快速验证模型在移动端的可行性；或模型使用了极其特殊、难以转换的算子。 |




```
NCNN:
https://gitee.com/guolun/ncnn-yolov8-android/blob/master/README.md
https://blog.csdn.net/DoraemonCat520/article/details/139472947
https://convertmodel-1256200149.cos-website.ap-nanjing.myqcloud.com/
https://www.bilibili.com/opus/1076081443060318248
https://blog.csdn.net/wanggao_1990/article/details/146007121

```


## 🔄 Yolo模型转换

### 转ONNX
yolo export model=xxx format=onnx imgsz=640 opset=17 simplify=True dynamic=False batch=1




# 二、移动端集成


## Android C++项目集成OpenCV

1：创建Android C++项目

2：下载Android SDK（OpenCV – 4.12.0） https://opencv.org/releases/?aliasId=l10B6XvDlABIGHJ2I

3：解压下载的SDK，将目录下的sdk目录通过import module方式导入到Android项目中,导入的module最好还是以sdk作为名称，否则后面编译可能报错

**CMakeLists.txt配置**
```
cmake_minimum_required(VERSION 3.22.1)

project("dartrecognitionandroid")

# 指向 openCVLibrary 模块中的 jni 目录（包含 OpenCVConfig.cmake）
set(OpenCV_DIR "xxx\\DartRecognitionAndroid\\sdk\\native\\jni")

# 查找 OpenCV 包
find_package(OpenCV REQUIRED)

# 添加并链接库
add_library(dartrecognitionandroid SHARED native-lib.cpp DartLineCVModel.cpp)
target_link_libraries(dartrecognitionandroid ${OpenCV_LIBS} android log jnigraphics)
```


**在图片上绘制文本给到Android展示**
```

#include <jni.h>
#include <string>
#include <android/bitmap.h>
#include <opencv2/opencv.hpp>

extern "C"
JNIEXPORT jbyteArray JNICALL
Java_com_leach_dartrecognitionandroid_MainActivity_predict(JNIEnv *env, jobject clazz,jobject imageData) {

    // 获取Java类和字段ID
    jclass cls = env->GetObjectClass(imageData);
    jfieldID fidWidth = env->GetFieldID(cls, "width", "I");
    jfieldID fidHeight = env->GetFieldID(cls, "height", "I");
    jfieldID fidChannels = env->GetFieldID(cls, "channels", "I");
    jfieldID fidData = env->GetFieldID(cls, "data", "[B");
    jfieldID fidLineModelPath = env->GetFieldID(cls, "lineModelPath", "Ljava/lang/String;");

    // 提取字段值
    int width = env->GetIntField(imageData, fidWidth);
    int height = env->GetIntField(imageData, fidHeight);
    int channels = env->GetIntField(imageData, fidChannels);
    jbyteArray data = (jbyteArray)env->GetObjectField(imageData, fidData);
    jstring jlineModelPath = (jstring)env->GetObjectField(imageData, fidLineModelPath);

    // 将Java字节数组转换为C++指针
    jbyte* cData = env->GetByteArrayElements(data, nullptr);

    const char* lineModelPath = env->GetStringUTFChars(jlineModelPath, nullptr);

    // 创建cv::Mat对象 (ARGB格式)
    cv::Mat inputMat(height, width, CV_8UC4, (unsigned char*)cData);

    // 转换颜色空间 (OpenCV使用BGR，Android使用ARGB)
    cv::Mat bgrMat;
    cv::cvtColor(inputMat, bgrMat, cv::COLOR_RGBA2BGR);

    // 在图片上绘制文本
    cv::putText(bgrMat,
                "123",
                cv::Point(50, 100),
                cv::FONT_HERSHEY_SIMPLEX,
                2.0,
                cv::Scalar(0, 0, 255),
                3,
                cv::LINE_AA);

    // 转换回RGBA格式以便在Android中正确显示
    cv::Mat resultMat;
    cv::cvtColor(bgrMat, resultMat, cv::COLOR_BGR2RGBA);


    // 创建返回的byte数组
    jbyteArray result = env->NewByteArray(resultMat.total() * resultMat.elemSize());
    env->SetByteArrayRegion(result, 0, resultMat.total() * resultMat.elemSize(),
                            (jbyte*)resultMat.data);

    // 释放资源
    env->ReleaseByteArrayElements(data, cData, JNI_ABORT);
    env->ReleaseStringUTFChars(jlineModelPath,lineModelPath);

    return result;
}
```


## NCNN集成

1：下载ncnn移动端库 https://github.com/Tencent/ncnn?tab=readme-ov-file，
解压复制到项目的cpp目录下，不要改任何文件以及代码

2：pt模型onnx转ncnn格式

**yolo export model=DartLine.pt format=onnx imgsz=640 opset=12 simplify=True dynamic=False batch=1 nms=False half=False device=cpu**

```
使用----》

加载你的训练模型（替换为实际路径）
model = YOLO("../model/DartLine.pt")

导出为NCNN格式（关键参数说明见下文）
model.export(
    format="ncnn",  # 指定导出目标格式
    imgsz=640,  # 输入图像尺寸，必须为固定值（NCNN不支持动态尺寸）
    batch=1,  # 批次大小固定为1（嵌入式推理典型场景）
    device="cpu",  # 显存非必需，CPU导出更稳定
    half=False,  # 默认不启用FP16（NCNN对FP16支持有限，建议先用FP32验证）
    simplify=True  # 启用ONNX简化（移除冗余节点，提升NCNN兼容性）
)

```


```
https://guo-pu.blog.csdn.net/article/details/142942825

 
# export_onnx.py
from ultralytics import YOLO
import sys

def export_yolo_to_onnx(model_path, output_path="yolo_export.onnx"):
    """
    将YOLO模型导出为ONNX格式
    
    参数:
        model_path: PyTorch模型路径 (.pt)
        output_path: 输出ONNX文件路径
    """
    print(f"正在加载模型: {model_path}")
    
    # 加载YOLO模型
    model = YOLO(model_path)
    
    # 获取模型信息
    print(f"模型类别数: {model.model.nc}")
    print(f"模型输入尺寸: {model.model.args.get('imgsz', 640)}")
    
    # 导出ONNX
    print(f"正在导出ONNX到: {output_path}")
    
    success = model.export(
        format='onnx',
        imgsz=640,           # 输入图像尺寸
        opset=12,            # ONNX opset版本（12最稳定）
        simplify=True,       # 简化模型
        dynamic=False,       # 固定输入尺寸（移动端推荐）
        batch=1,             # 批大小设为1
        nms=False,           # 不包含NMS（重要！）
        half=False,          # 不使用FP16（确保兼容性）
        workspace=4,         # GPU工作空间（GB）
        device='cpu',        # 在CPU上导出确保兼容性
        verbose=True         # 显示详细信息
    )
    
    if success:
        print(f"✅ ONNX导出成功: {output_path}")
        return output_path
    else:
        print("❌ ONNX导出失败")
        return None

# 使用示例
if __name__ == "__main__":
    # 你的模型路径
    pt_model = "DartLine.pt"
    onnx_output = "DartLine.onnx"
    
    export_yolo_to_onnx(pt_model, onnx_output)
```

**简化ONNX模型**

pip install onnxsim

python -m onnxsim DartLine.onnx DartLine-sim.onnx

```
# 验证简化后的模型
python -c "
import onnx
model = onnx.load('DartLine-sim.onnx')
onnx.checker.check_model(model)
print('✅ ONNX模型简化成功')
print(f'输入: {model.graph.input[0].name}')
print(f'输出: {model.graph.output[0].name}')
"
```

**转换到ncnn格式**

onnx2ncnn ./DartLine-sim.onnx ./DartLine.param ./DartLine.bin


```
**#pnnx DartLine1.onnx**

注：如果执行pnnx转换时报错OMP: Error #15: Initializing libiomp5md.dll, but found libiomp5md.dll already initialized.这个错误是因为程序中有多个OpenMP运行时库被初始化。通常发生在链接了多个包含OpenMP的库，并且它们都试图初始化自己的OpenMP运行时环境。建议用conda/anaconda创建过一个环境，再用pnnx转

inputshape = [batch_size, channels, height, width]
# 示例：[1, 3, 224, 224]
# batch_size = 1    # 一次处理1张图
# channels = 3      # RGB三通道
# height = 224      # 图像高度224像素
# width = 224       # 图像宽度224像素


# PNNX帮助信息
pnnx --help
# 常见参数：
pnnx mobile.onnx \
  inputshape=[1,3,224,224] \    # 输入形状（可选）
  inputshape2=[1,4] \           # 多输入形状
  device=cpu \                  # 运行设备：cpu/gpu
  optlevel=2 \                  # 优化级别：0-2
  fp16=1 \                      # 是否使用FP16：0/1
  use_f16=1 \                   # 同上
  use_fp16_storage=1 \          # 存储使用FP16
  customop=./customop.def \     # 自定义操作定义
  moduleop=./moduleop.def \     # 模块操作定义
  pnnxparam=./param.par \       # PNNX参数文件
  pnnxbin=./model.bin \         # PNNX权重文件
  pnnxpy=./model.py \           # 生成Python接口
  pnnxonnx=./model.onnx \       # 生成ONNX文件
  ncnnparam=./model.ncnn.param \# 输出NCNN结构
  ncnnbin=./model.ncnn.bin \    # 输出NCNN权重
  ncnnpy=./model_ncnn.py        # 输出NCNN Python接口


运行PNNX转换：
如果ONNX模型输入是静态的，可以直接运行：pnnx mobile.onnx
如果是动态的，运行：pnnx mobile.onnx inputshape=[x,x,x,x]


查看模型信息
pip install netron
netron DartLine.pt

打开模型后，点击任意输入/输出节点，在右侧属性面板查看shape
判断方法：
如果看到具体数字：[1, 3, 224, 224] → 静态维度
如果看到?或None：[?, 3, ?, ?] → 动态维度
如果看到符号名：[batch, 3, height, width] → 动态维度
```


3：同时集成opencv和ncnn会报编译冲突问题，解决方案可参考

https://gitee.com/luo_zhi_cheng/awesome-ncnn/blob/master/FAQ.md

https://github.com/Tencent/ncnn/issues/3231

**重新编译ncnn**

```
windows
1：git clone https://github.com/Tencent/ncnn.git
cd ncnn
git submodule update --init

2：下载NDK，配置环境变量
# open $ANDROID_NDK/build/cmake/android.toolchain.cmake for ndk < r23
# or $ANDROID_NDK/build/cmake/android-legacy.toolchain.cmake for ndk >= r23
# delete "-g" line
list(APPEND ANDROID_COMPILER_FLAGS
  -g
  -DANDROID


3：下载Ninja，配置环境变量：https://github.com/ninja-build/ninja/releases

4：cmake -G "Ninja" -DCMAKE_TOOLCHAIN_FILE="F:/Install/StudySoftware/AndroidSdk/ndk/26.1.10909125/build/cmake/android.toolchain.cmake" -DANDROID_ABI="arm64-v8a" -DANDROID_ARM_NEON=ON -DANDROID_PLATFORM=android-14 -DNCNN_VULKAN=ON -DNCNN_DISABLE_EXCEPTION=OFF -DNCNN_DISABLE_RTTI=OFF ..
#armeabi-v7a
#arm64-v8a
ninja install

5：将编译出来的目录下的include目录里面的文件拷贝到项目里对应的arm64-v8a、armeabi-v7a、x86_64、x86目录下

6：CmakeLists.txt配置
cmake_minimum_required(VERSION 3.22.1)

project("dartrecognitionandroid")

# 指向 openCVLibrary 模块中的 jni 目录（包含 OpenCVConfig.cmake）
set(OpenCV_DIR "xxx\\DartRecognitionAndroid\\sdk\\native\\jni")

# 查找 OpenCV 包
find_package(OpenCV REQUIRED)

# 设置 NCNN 安装目录
set(ncnn_DIR ${CMAKE_SOURCE_DIR}/ncnn-20250916-android-vulkan/${ANDROID_ABI}/lib/cmake/ncnn)
find_package(ncnn REQUIRED)

## 打印可用变量来调试
#message(FATAL_ERROR "ncnn_DIR: ${ncnn_DIR}")


# 添加并链接库
add_library(dartrecognitionandroid SHARED native-lib.cpp DartLineCVModel.cpp Constants.cpp YOLOv11Detector.cpp)


target_link_libraries(dartrecognitionandroid ${OpenCV_LIBS} ncnn android log jnigraphics)

```

模型优化
```
# 使用ncnnoptimize优化模型
./ncnnoptimize model.param model.bin model-opt.param model-opt.bin 65536

# 使用FP16量化（减小模型大小）
./ncnnoptimize model.param model.bin model-opt-fp16.param model-opt-fp16.bin 65536

# 使用INT8量化（最大压缩）
./ncnn2int8 model.param model.bin model-int8.param model-int8.bin calib.table
```


https://blog.csdn.net/QQ_1309399183/article/details/149009894
https://blog.csdn.net/weixin_34471637/article/details/156463071